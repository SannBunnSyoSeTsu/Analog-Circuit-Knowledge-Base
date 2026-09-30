# 37 · 三阶嵌套Miller：多级增益、补偿环路与负载驱动

本模块通过三级放大提供高开环增益和负载驱动能力，用嵌套Miller补偿协调多个高阻节点的极点。相比基础两级Miller结构，额外一级可提高增益并分配各级驱动任务，同时增加稳定性和建立时间设计的难度。芯片中可用作高精度信号调理、ADC驱动或其他闭环模拟系统的误差放大器。

状态：**SMIC18MMRF / TT / 1.8 V / 27°C，全部对应 nominal 原始指标通过**。只宣称原理图级 nominal；未执行其他PVT、失配或版图验证。审查PDF已逐页检查中文、图表和网表可读性。

[审查 PDF](../evidence/37-nested-miller/review.pdf) · [精确电路](../evidence/37-nested-miller/circuit.scs) · [验收合同](../evidence/37-nested-miller/contract.json) · [实测结果](../evidence/37-nested-miller/latest_results.json)

当前报告：**6页正文＋2页完整电路图，共8页**。下文历史交付记录中的页数对应当时的正文版本。

<!-- REPORT-MARKDOWN -->
## 可编辑报告与系统结构

[完整报告MD](../evidence/37-nested-miller/review_report.md) · [对应PDF](../evidence/37-nested-miller/review.pdf)
<!-- END-REPORT-MARKDOWN -->

## 完成范围和结论

在 **SMIC18MMRF tt、1.8 V、27°C**，5 uA参考电流、0.9 V输入共模及输出目标、200 pF理想负载下，完成原合同全部五组nominal检查：OP/返回比AC、独立输入偏置、801点直流跟踪范围、0.4→0.9 V建立和双向压摆。全部达到原门槛，状态为 `complete_original`，没有使用10%或15%的性能放宽。

原任务 `sky130-three-stage-nested-miller-ota-pvt` 的完整矩阵为5个工艺×3个电源×3个温度，共45点，每点五组测试。本次只做其中的nominal条件，其余44点未运行。局部失配、MC、互连/器件版图寄生、封装和老化也未运行；原任务本来就没有包含局部失配验收。不能把本次nominal完成写成原45点PVT签核通过。

| 指标 | SMIC18实测 | 原门槛 | 10%边界 | 15%边界 |
|---|---:|---:|---:|---:|
| 返回比增益，0.1 Hz | 119.588870 dB | ≥110 dB | ≥109.08485 dB | ≥108.58838 dB |
| UGB | 451.659060 kHz | ≥400 kHz | ≥360 kHz | ≥340 kHz |
| 返回比PM | 75.621534° | ≥70° | ≥63° | ≥59.5° |
| 负载驱动FOM | 370.778881 kHz·pF/uW | ≥300 | ≥270 | ≥255 |
| 静态输出误差 | 3.155316 mV | ≤10 mV | ≤11 mV | ≤11.5 mV |
| VDD总功耗，含参考 | 243.627177 uW | <300 uW | <330 uW | <345 uW |
| VINP/VINN绝对DC电流 | 0 / 0 nA | 各≤100 nA | 各≤110 nA | 各≤115 nA |
| 连续合格命令区间 | 1.068 Vpp | ≥0.8 Vpp | ≥0.72 Vpp | ≥0.68 Vpp |
| 0.4→0.9 V建立时间 | 2.380 us | <3 us | <3.3 us | <3.45 us |
| 50 us终值误差/0.5 V阶跃 | 0.631063% | ≤2% | ≤2.2% | ≤2.3% |
| 上升压摆率 | 0.300245 V/us | ≥0.2 V/us | ≥0.18 V/us | ≥0.17 V/us |
| 下降压摆率 | 0.293453 V/us | ≥0.2 V/us | ≥0.18 V/us | ≥0.17 V/us |

两个输入偏置是独立门槛，所以表中共有13个标量门槛。增益的dB放宽先作用于线性幅度比，再加 `20log10(0.90/0.85)`；PM保持45°绝对下限。功耗和建立时间保留原来的严格小于。**200 pF负载、全部刺激、801点网格、20 mV范围资格窗、10 mV建立窗和观察时长都没有放宽。** 数据有限性、正功耗和模型合法尺寸同样不能放宽。

## 保留的架构和反馈极性

接口为 `three_stage_nmc_ota (vss iref vdd vinn vinp vout)`。DUT包含16只原生n18/p18 MOS与两个正电容，没有数字电路、内部独立源、受控源或行为源。所有偏置由外部5 uA的唯一模拟偏置端iref派生。

第一增益级是NMOS输入对 `MI1/MI2` 和PMOS镜负载 `MP1A/MP1B`。VINP升高使n1下降。第二增益级由NMOS共源 `MA2`、二极管PMOS `MPD2` 和PMOS镜输出 `MPM2` 构成，输出n2下接固定NMOS电流源MS2。n1升高会增大MA2电流、降低nb、增加MPM2上拉，从而使n2升高，所以第二增益级总体非反相。第三级是NMOS共源MA3及PMOS固定电流源ML3；n2升高使vout下降。整体VINP到VOUT极性为正，输出直接反馈到VINN形成负反馈。

外层 `CM1=8 pF` 连接vout与n1，跨越第二、第三增益级；内层 `CM2=3 pF` 连接vout与n2，包围输出共源级。没有将其中一个电容改为对地电容，也没有用单级/两级电路冒充三阶补偿。这里的“三级”按有效电压增益块划分：第二级内部的NMOS共源与PMOS镜组成一个非反相增益块。

一级、二级使用L=1 um器件获取输出电阻，输出NMOS用L=0.36 um保持驱动速度。与参考网表相比，器件均由目标工艺LUT重新选尺寸，参考架构和两个嵌套路径保持不变。首次完整电气版本即通过，没有需要隐去的失败电气候选，也没有为制造通过降低负载或缩短观察窗。

## gm/ID初值、几何和实际OP

调用既有 `gmoverid_smic18` 表，查询与原始表SHA-256记录于 `sizing.json`。LUT的Wref=10 um、VBS=0只负责初值；实际电路仿真包含窄宽、体效应和不同漏源压造成的变化。没有更改原LUT、PDK或Bridge；已有表足够，不需补扫。

| 角色 | 模型 | 单位W/L，um | 目标gm/ID | 目标单支电流 | 主要m |
|---|---|---:|---:|---:|---|
| MI1 / MI2 | n18 | 1.24 / 1 | 18 | 1.2 uA | 1 |
| MP1A / MP1B | p18 | 0.72 / 1 | 8 | 1.2 uA | 1 |
| MA2 | n18 | 0.30 / 1 | 8 | 2.5 uA | 1 |
| MPD2 / MPM2 | p18 | 2.34 / 1 | 10 | 2.5 uA单位 | 1 / 2 |
| MREF / MTAIL / MBP1 / MVBN / MS2 | n18 | 2.34 / 1 | 14 | 5 uA单位 | 1 / 0.48 / 1 / 1 / 1 |
| MPDM / MS2B / ML3 | p18 | 4.68 / 1 | 10 | 5 uA单位 | 1 / 1 / 21 |
| MA3 | n18 | 17.02 / 0.36 | 14 | 105 uA | 1 |

全部单位W≤17.02 um，远小于100 um模型限制；输出PMOS使用4.68 um单位、m=21，总宽98.28 um。尾管m=0.48是Spectre连续模型缩放，有效宽1.1232 um。它在本次原理图中合法，但实版仍需改成工艺允许且可匹配的几何并重新验证，不能把小数m当作已经实现的布局。

输入目标 `gm≈1.2 uA×18=21.6 uS`，`gm/(2π·8 pF)≈430 kHz`，用于初估带宽。A2特意用较低gm/ID=8，以较高栅压建立n1，让输入MI2维持足够VDS；仅把各级都设成很高gm/ID可能压低n1，损害一级增益和输入余量。输出初值 `gm≈105 uA×14=1.47 mS`，为200 pF负载与内层补偿提供跨导。

| 实际OP | 电流幅值/uA | gm/ID | gm/gds | 饱和余量/mV |
|---|---:|---:|---:|---:|
| MI1 | 1.175332 | 18.041984 | 310.328 | 717.806 |
| MI2 | 1.195077 | 17.857950 | 141.411 | 172.602 |
| MTAIL | 2.370410 | 14.157199 | 151.575 | 225.037 |
| MP1B | 1.195076 | 8.003690 | 278.899 | 980.712 |
| MA2 | 2.591063 | 7.323403 | 235.982 | 971.627 |
| MPM2 | 5.292122 | 9.725630 | 319.838 | 1077.891 |
| MS2 | 5.292122 | 13.880032 | 234.637 | 421.660 |
| MA3 | 109.642845 | 13.800963 | 138.355 | 780.574 |
| ML3 | 109.642859 | 9.774369 | 305.870 | 725.676 |

余量为 `abs(VDS)−abs(VDSAT)`。全部16只MOS中心OP均为正，最小是MI2的172.602 mV；完整16行记录在 `latest_results.json` 和PDF第三页。实际节点为tail=0.345449 V、na=1.153996 V、n1=0.610616 V、nb=1.195697 V、n2=0.544739 V，vout=0.896845 V。窄宽MA2的实际gm/ID=7.323而不是查表目标8，说明必须用真实尺寸OP闭合设计；不能把查表数值直接当成最终测量。

用OP估计低频级增益：`A1≈gm_MI2/(gds_MI2+gds_MP1B)`，`A2≈gm_MA2×(gm_MPM2/gm_MPD2)/(gds_MS2+gds_MPM2)`，`A3≈gm_MA3/(gds_MA3+gds_ML3)`。分别约41.23、38.22、40.41 dB，合计119.86 dB，与实测119.59 dB接近。这是小信号近似一致性检查，不是另一份独立环路测量。

有限漏源压和镜像支路的不对称使两输入分支电流略有差异，名义电路仍有3.155 mV闭环输出偏差。高开环增益不会自动消除确定性输入等效偏移；同样，这种名义偏移不能代表随机失配分布。

## 原验证器和五组测量定义

原 `instruction.md`、`solution/circuit.spi`、`verify.py`、`utils.py` 和五套正式bench完整冻结到 `source/` 并记录SHA-256。Spectre通过现有环境运行，每次保留独立的 `inputs/` 与真实PSF。提取把PSF向量适配为原验证器的 `Plot`，直接调用每一组的 `extract_metrics`；原 `nominal_functional` 对OP/AC与建立结果的交叉检查也通过。原45点矩阵调度和完整PVT检查没有运行，没有复制nominal行凑矩阵。

1. **OP/AC**：VINP固定0.9 V，输出和VINN之间放DC0、AC1的串联电压源。DC为单位反馈，AC返回比是 `T=−V(vout)/V(vinn)`，不能误用闭环Vout作为开环增益。扫描0.01 Hz–100 MHz，本次100点/十倍频，原bench为40点/十倍频；增益取0.1 Hz，首个下降0 dB交越按log(f)插值，PM来自展开相位。额外验证整个扫频只有一次下降交越且随后不回穿。独立提取与原函数误差仅为浮点舍入。
2. **功耗/FOM**：在同一单位反馈OP测量 `−1.8×I(VDD)`，包括外部5 uA参考和全部内部支路。原函数对负功耗有零裁剪，迁移增加原始功耗必须为正的守卫。`FOM=451.659060 kHz×200 pF/243.627177 uW=370.778881`。单独满足带宽或功耗不能代替这个耦合效率门槛。
3. **输入偏置**：VINP和VINN分别由独立0.9 V电压源驱动，输出开环并挂200 pF，读取各输入源DC电流绝对值。两者在该模型中均为0 A；未包含的栅漏电、ESD和封装漏电不能从0推断为零。此开环bench的输出约7.88 mV，完全不是用来判定0.9 V输出误差；后者必须取单位反馈OP。
4. **范围**：保持单位反馈，VINP由0.1扫到1.7 V、步长2 mV，共801点。按固定20 mV误差资格窗寻找最大连续命令区间；535点形成0.100–1.168 V，跨度1.068 V。1.168 V误差19.996611 mV，下一点1.170 V误差20.705040 mV而失格。0.100 V是扫描下界，未声称真正的低端物理极限。低输入时偏置可能很弱，DC跟踪合格不能证明整个区间具有同样带宽、稳定裕量和压摆能力。
5. **建立**：命令0.4→0.9 V，2.0–2.1 us线性边沿，观察到50 us。固定容差是0.5 V阶跃的2%，即目标0.9 V±10 mV；时间从2.0 us边沿开始计。原函数选择最后一次采样越界后第一个全部余下样本合格的采样点，没有线性插值。最后越界点为边沿后2.37 us、输出0.889923 V，下一点2.38 us、0.890265 V，因此记录2.38 us。终值为0.896844684 V，按0.5 V阶跃归一为0.631063%。不能以实际终值重新居中误差窗。
6. **压摆**：0.65→1.15 V在2.0–2.1 us上升；原PULSE高电平宽40 us，因此下降开始42.1 us、结束42.2 us，原算法从42 us开始搜索。上、下行都测输出0.75–1.05 V之间的0.3 V变化，阈值时间按线性插值；整个观察到82 us，最后时刻恰为下一周期开始，PWL在此之前与原PULSE相同。

两份瞬态统一输出采样10 ns、内部最大步长5 ns，采用保守误差设置和gear2only。2.38 us是采样定义下的值，末次进入连续时间只能被这组保存数据夹在2.37–2.38 us之间；未宣称亚纳秒精度。范围端点解析度为2 mV；AC使用100点/十倍频对数插值，也没有声称无限频率分辨率。

## 可复用工程认识

实际 `Itail/C1=2.370410 uA/8 pF≈0.29630 V/us`，与双向压摆0.30025/0.29345 V/us一致；输出PMOS静态上拉电流除200 pF约0.54821 V/us，因此这个版本主要由前级补偿电容的充放电能力限制压摆。盲目加大输出电流会增加功耗并损害FOM，未必改善主要瓶颈。

第三个增益级把低频增益预算分散到三个有限增益块，使119 dB名义增益可以在243.6 uW和200 pF下实现，但内部极点、补偿电容和电流必须联动。设计本例时先用输入跨导/C1定位UGB，再给中间节点余量、输出跨导和C2安排高频极点，最后用实际返回比和大信号窗口验证；仅用一个理想两级Miller公式不足以证明三级稳定。

此例没有CMFB，因为它是单端输出，不能套用上一全差分模块的差模注入、共模恢复或噪声合同。复现的重点是正确保留本题的返回比、输入电流连接、固定200 pF、完整命令网格和PULSE边沿定义。

## 证据与复现路径

- 设计脚本：`scripts/case37_nested_miller.py`；PDF脚本：`scripts/review37.py`。
- 精确DUT：`cases/37-nested-miller/circuit.scs`；尺寸/哈希：`sizing.json`、`geometry.json`；冻结合同：`contract.json`。
- 结果：`latest_results.json`；审查PDF：`reports/37-nested-miller-review.pdf`；视觉记录：`pdf_provenance.json`；模块审计：`verification_audit.json`。
- 正式OP/AC：`runs/37/20260922T094634948149Z_pvt`。
- 输入偏置：`runs/37/20260922T094635113442Z_input_bias`。
- 801点范围：`runs/37/20260922T094635241732Z_swing`。
- 建立：`runs/37/20260922T094635425475Z_settling`。
- 压摆：`runs/37/20260922T094635958990Z_slew`。
- 首次静态预检：`runs/37/20260922T094630261297Z_pvt`，用于确认偏置与环路，尚未测其余四组时保留为partial，不计为完整完成。

工程根目录下用 `/home/IC/CodeX/virtuoso-bridge-lite/.venv/bin/python scripts/case37_nested_miller.py` 重做五组；同一Python执行 `scripts/review_pdf.py 37` 生成PDF。每次仿真创建新的冻结快照，旧证据保留。没有使用Sky130历史结果替代本次SMIC18测量。

[完整 LUT 查询](../evidence/37-nested-miller/sizing.json)

## 复现与证据

[完整电路总图 SVG](../evidence/37-nested-miller/schematic/full.svg) · [总图 PDF](../evidence/37-nested-miller/schematic/full.pdf) · [2页电路分图](../evidence/37-nested-miller/schematic/sheets.pdf) · [引脚与层次连接映射](../evidence/37-nested-miller/schematic/connectivity.json) · [图纸审计](../evidence/37-nested-miller/schematic_audit.json)

- [Spectre 运行记录](https://github.com/SannBunnSyoSeTsu/smic18-benchmark-reproduction/blob/6ae3e1434914297c4ed12b93cb8d6a297ef8339a/runs/37/20260922T094634948149Z_pvt/run.json) · 原始输出（本地归档，未随仓库分发）
- [Spectre 运行记录](https://github.com/SannBunnSyoSeTsu/smic18-benchmark-reproduction/blob/6ae3e1434914297c4ed12b93cb8d6a297ef8339a/runs/37/20260922T094635113442Z_input_bias/run.json) · 原始输出（本地归档，未随仓库分发）
- [Spectre 运行记录](https://github.com/SannBunnSyoSeTsu/smic18-benchmark-reproduction/blob/6ae3e1434914297c4ed12b93cb8d6a297ef8339a/runs/37/20260922T094635241732Z_swing/run.json) · 原始输出（本地归档，未随仓库分发）
- [Spectre 运行记录](https://github.com/SannBunnSyoSeTsu/smic18-benchmark-reproduction/blob/6ae3e1434914297c4ed12b93cb8d6a297ef8339a/runs/37/20260922T094635425475Z_settling/run.json) · 原始输出（本地归档，未随仓库分发）
- [Spectre 运行记录](https://github.com/SannBunnSyoSeTsu/smic18-benchmark-reproduction/blob/6ae3e1434914297c4ed12b93cb8d6a297ef8339a/runs/37/20260922T094635958990Z_slew/run.json) · 原始输出（本地归档，未随仓库分发）
- [工程脚本](https://github.com/SannBunnSyoSeTsu/smic18-benchmark-reproduction/tree/6ae3e1434914297c4ed12b93cb8d6a297ef8339a/scripts) · [项目状态](https://github.com/SannBunnSyoSeTsu/smic18-benchmark-reproduction/blob/6ae3e1434914297c4ed12b93cb8d6a297ef8339a/status.json)

原Sky130案例保持原样；本页是目标工艺实测的新记录。模型文件留在既有本地PDK目录，没有上传或修改。
