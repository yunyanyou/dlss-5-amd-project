# Mochizuki split 共享颜色、motion 输入与纹理输出

## 准入外分支改共享纹理（2026-10-22，feat/nr-bridge-opt，离线夹具通过；2026-10-23 巫师 3 实机功能/画面通过，性能仅目测）

逐分支结论。证据为本分支源码位置；2026-10-23 已在 NUC 编译 runtime 并跑离线夹具（见本节末），
**未进游戏**。

| 分支 | 结论 | 依据 |
|---|---|---|
| DRS/bucket 颜色 | 已接入（源码） | 载体按网络尺寸 `geometry.width×height`（bucket）申请；`ImageInput::Capture` 对子矩形/更大的游戏分配改用 `CopyTextureRegion` 盒拷贝到左上角，整尺寸仍用 `CopyResource`；Vulkan 侧在 EXTERNAL acquire 后对导入 image 做与 buffer 路线相同的 `Pad`；`RecordOutputs`/旁路本来就按 `w×h` 盒拷回 |
| DRS/bucket motion | 不接入，保留 buffer | Padded/Rescaled 路线把向量铺进 bucket 尺寸的 `motionScaled`（上传、blit 或 compute 缩放后 Pad），不是"整张原样消费"；共享 motion 仍只收整尺寸、`Uploaded`、非 bucket（`SharedMotionEligible` 显式加了这三条，保持原准入） |
| 模型缩放 `net.scale≠1` | 已接入（源码） | 缩放在核心内完成；核心从两种载体得到的都是同一 `kImageUsage`、GENERAL 进/TRANSFER_SRC 出，读写同一 `frame.colour`；D3D12 捕获/回写与缩放无关 |
| 多遍 `passes>1` | 已接入（源码），**首遍导出除外** | 同上，多遍循环在核心内对同一图像；`firstPass` 导出仍走 buffer：导出从 `firstOutput` buffer 下载，旁路 `RecordFallback` 也是 input buffer→firstOutput buffer 复制，共享载体没有这份数据 |
| RenoDX | 已接入（源码） | `sf.colour = sf.output = frame.colour`；`kImageUsage` 不含 STORAGE，RenoDX 阶段走"复制进/复制出"（`nr_renodx.cpp` 的 borrow 条件不成立），与载体无关；RenoDX 本来就在图形队列，与共享载体同族 |
| canonical 转换（Plan A） | 不接入，保留 buffer | `MakeBuffers` 中 `convert.Create(..., b.colourImage.image, ...)` 把转换描述符绑定在 buffer 载体的 image 上，换成共享载体后描述符仍指向旧 image；输出端 `DispatchUnconvert` 以 storage 写回 `colour`，共享载体只在 RGBA16F 且设备支持时才带 STORAGE。要接入须按载体重建转换描述符并要求所有翻转格式的 storage 导入，且 Plan A 只在格式翻转（如过场）期间出现，换载体需重新初始化，翻转帧大多仍会落在 buffer 上 |
| Inline | 不动 | 冻结 |

内部回滚：`MZ_TEST_SHARED_EXTENDED=0`（进程启动前设置）恢复 2026-10-19 的窄准入；
`MZ_TEST_SHARED_INPUT=0` 仍整体回到 buffer。默认开启扩展准入，失败/预算/退避机制不变。

离线夹具（2026-10-23 NUC，`tests/mochizuki/run.cmd shared-extended`，`shared_extended.cpp` +
`shared_extended.py`）：256×256 RGBA16F 分配、小模型、native；每个场景默认与 `MZ_TEST_SHARED_EXTENDED=0`
各跑一次（另手工跑了 `MZ_TEST_SHARED_INPUT=0` 与 D3D12 debug layer）。比较的是子矩形内的输出 hash
（hash0 = ResetHistory 后首帧，hash1 = 下一帧时域输出），不是 Pad 后的中间图像。

| 场景 | 默认路线（颜色/motion） | `EXTENDED=0` | `INPUT=0` | 输出 hash | wall 中位 ms 默认 / EXT0 / INPUT0 |
|---|---|---|---|---|---|
| 整尺寸（对照） | 共享/共享 | 共享/共享 | buffer | 三者相同 | 2.082 / 2.074 / 2.147 |
| exact 子矩形 200×180 | 共享/buffer | buffer | buffer | 三者相同 | 2.136 / 2.155 / 2.167 |
| bucket（drs_mode=1，200×180） | 共享/buffer | buffer | buffer | 三者相同 | 2.151 / 2.223 / 2.254 |
| scale=0.5 | 共享/共享 | buffer | buffer | 三者相同 | 2.086 / 2.176 / 2.204 |
| passes=2 | 共享/共享 | buffer | buffer | 三者相同 | 3.469 / 3.429 / 3.446 |
| passes=3 | 共享/共享 | buffer | buffer | 三者相同 | 4.633 / 4.662 / 4.754 |
| RenoDX（passes=1） | 共享/共享 | buffer | buffer | hash0 三者相同；hash1 同一路线两次也不同 | 2.088 / 2.130 / 2.200 |

- D3D12 debug layer 下所有场景 0 条错误；dispatch 数各路线相同（71/142/213）。
- RenoDX：`ResetHistory` 不清 RenoDX 的时域状态，同进程两次参考帧的 hash1 也不一致（buffer 路线同样），
  所以只能比 hash0；这与载体无关，夹具对 reno 只报告 `repro=0` 不判失败。
- 时间：每个变体单次 200 帧，差异约 0.1 ms 内，与运行间波动同量级；256×256 的拷贝量太小，
  **不据此声称更快**。净收益仍按 PLAN.md 的游戏内 A/B 流程测。

- 巫师 3 实机（2026-10-23，Steam 版 1.13.2-alpha6，1080p，split，RenoDX 开）：诊断轮 9101 帧
  `missing recording proxy`=0、coverage 350/350 全录无拒绝；默认（A/A2 两轮）reno 帧走
  shared、画面无异常；`MZ_TEST_SHARED_EXTENDED=0`（C 轮）精确只把 reno 帧打回 buffer；
  `MZ_TEST_SHARED_INPUT=0`（B 轮重跑）全 buffer。网络耗时各轮 3.77–3.83 ms（p95 3.84–4.01）
  持平。无 PresentMon 数据，性能结论仅为"目测无回退"，精确净收益仍待 PLAN.md 的游戏内
  A/B（燕云）或补测。

## 最新进度核对（2026-10-21）

符合现有共享颜色准入的 split 录制，输出直接从该录制持有的共享颜色纹理复制到原
`private_output`，不再绕经 Vulkan image→共享 buffer→D3D12 texture。不是新增输出
载体，不改变合成、模型、精度、历史、默认开关或格式准入。buffer/canonical/DRS/
缩放/多遍/RenoDX/Inline 路线不变；现有 output buffer 仍为这些路线及保留录制持有，
本轮不删除分配或降低预算估算。

`BoundRecording` 恢复已关闭录制的载体所有者；新路线不能替换旧录制的源。输入执行前
仍等待前一个消费者尾部；Vulkan 将纹理释放回 GENERAL 并发布实际提交完成 fence，
D3D12 队列等待后才执行 texture→private_output。预核心失败时纹理已是本帧捕获输入，
仍进行 acquire/release 与完成发布，不把旁路计作完整 NR。未提交丢弃、保留重放、
跨队列、格式/几何替换、挂起消费者尾部及拒绝共享 motion 的回退均有针对性冒烟。
RGBA16F 颜色载体另优先尝试可选 STORAGE/UAV 分配（含 typeless 的既有 typed twin）。
只有 Vulkan 外部 image capability 与 D3D typed UAV 支持、实际分配预算及导入均通过
才使用；非 device-loss 失败后本会话不重复尝试，并继续申请原 sampled/transfer 共享
纹理。两者都不可用时保留 buffer NR 与原退避。初始化提交失败仍走既有 buffer/退避，
不在已提交初始化后强行替换。其余颜色格式及 motion 不要求 storage；缓存/待准入按
实际 usage 匹配，日志 `usage=0xf` 与回退 `0x7` 可区分。核心仍收到 `kImageUsage`，
没有因此启用新 shader-store 或改变模型数学，只改变资源可选能力；底层压缩/缓存机制
尚未由硬件计数器证明。

在已直接输出基础上的同会话双载体配对，RGBA16F 可选分配额外节省 Small ACO
0.13038 ms（0.07608–0.16788）、原生 0.13724 ms（0.10776–0.17020），
Original ACO 0.14700 ms（0.04340–0.17388）、原生 0.16108 ms
（0.11560–0.18968）；Small ACO 标记关 0.12040 ms（0.10772–0.14208）。
这些是独立配对，不将其中位与输出单项中位相加冒充组合收益。资源重复持有仅限 scratch
双载体控制；产品不新增永久双份载体，不删既有 allocation/budget 安全边界。

组合候选另做完整前后配对（不是上述中位数相加）：RGBA16F Small ACO 节省
0.22044 ms（0.19888–0.24100）、原生 0.23342 ms（0.20868–0.30048）；
Original ACO 0.21450 ms（0.17148–0.24688）、原生 0.23500 ms
（0.15360–0.30284）。Small ACO 标记关为 0.21822 ms；同载体无操作 A/A
中位 −0.01168 ms（−0.03312–0.04172），小差异不作稳定收益。

最终产品原版/产品共享完整桥接中位：Small ACO RGBA16F 6.82270/6.87100 ms，
配对剩余差 +0.06494 ms（+0.02916–+0.08952）；Small 原生 8.68356/8.70134 ms，
配对差 +0.01090 ms（−0.01440–+0.04200）。Original RGBA16F 配对剩余差
ACO +0.05378 ms、原生 +0.02100 ms，部分轮次跨零。RGBA8 残差约
0.01800–0.05056 ms，保留负/噪声轮次，不承诺每种模式固定加速。最终八模式矩阵
计时内 7200 次完整 NR、660960 次 dispatch，与对应原版/产品 buffer 输出 hash 一致。
23 种颜色格式 ACO/原生/强制共享导入拒绝三组各 1357 次完整 NR，D3D12 debug 错误零；
正常共享 23/23，拒绝组 0/23 仍保持 buffer 序列一致。单独强制 storage 拒绝后
sampled 共享及跨队列/重放/尾部生命周期通过，不减少原格式支持。



RX 9070 XT、驱动 32.0.31041.1004、2558×1449、RG16F motion、单遍完整比例，
固定集成源码 `39e7fa05553c52e11bff444c39837673eee83113` 与原版隔离归档
`cc27501dc116bdcfbb43612e497c5ca12497574a`。六种顺序、同设备队列、每帧新录制、
相同历史推进且全 NR/dispatch/输出 hash 核对的 scratch 输出单项配对：Small RGBA16F
ACO 节省中位 0.09886 ms（0.06544–0.14024），原生 0.07090 ms
（0.05552–0.09532）；关闭额外标记的 ACO 为 0.07182 ms，六轮均正。
Original ACO 及 RGBA8 的部分轮次负收益/噪声保留，不声称每种模式均稳定加速。
产品 DLL 另跑 Small/Original × 原生/ACO × RGBA16F/RGBA8 生命周期冒烟，每项
22 次完整 NR；变化图像与非零 motion、跨队列重放、路线切换、挂起尾部均通过，
D3D12 debug 错误为零。与原版三路复测各模式输出 hash 一致，非游戏 FPS 结论。
永久入口 `tests\mochizuki\run.cmd shared-output` 读取本次追加的现有 runtime 路线日志，
确认实际采用共享颜色后才输出 `SHARED_OUTPUT_OK`；拒绝导入而只执行 buffer 时返回
`SHARED_OUTPUT_NOT_EXERCISED`（退出码 2），不把回退通过当作共享输出通过。


更新基线显示：当前 RGBA16F 共享输入并非始终比 buffer 快，旧约 0.180 ms 宿主结果
仅为历史版本结果。仅改变输出消费方式也会改变下一帧捕获计时；尚无硬件计数器证明
缓存/压缩/具体驱动原因。下一优先级是精确输入转换/编码/合成归因，而非盲目重复
已无稳定收益的 barrier 批处理、增加 shared→private 中间复制或改变录制时机。
GraphCore 的受限同 Session/device split `share_for` 已于2026-10-21接入兼容几何后台重建，见[范围与构造证据](mochizuki-007-remaining-assessment.md)。这不是本轮稳态提速，不扩大输入/输出格式准入。
用户不要求游戏同场景 A/B；本轮未执行。Vulkan validation、其他驱动/GPU及长期游戏
稳定性仍未覆盖；下文“输出不变”等描述为对应历史阶段，不覆盖上述当前输出契约。

## 最新进度核对（2026-10-20）

颜色共享（`2c437d76`）、motion 共享（`81c96d2e`）和现有全颜色格式扩展
（`53ca4f74`）均已接入。下文各阶段的“下一步/产品修改前”是当时记录，当前实现
以 motion 产品接入及全颜色格式两节为准。两种输入默认自动选择，不新增用户开关。

此前 FP16 完整宿主同条件对照合计中位省约 0.180 ms；原版三路离线对照仍余约
0.11–0.13 ms。不同夹具的数字不能相减推算收益，也未证明用户 5% FPS 差已解决。
正常日志未发现足以解释主要差距的证据，不以删日志作为当前优化方向。

燕云 10 月 19 日晚日志确认 RGBA8 颜色及 RG16F motion 均从 buffer 转为共享纹理，
近期统计窗口 callbacks/enqueues/split_accepted 均为 350，失败为 0；这是执行覆盖，
不是 Present 帧数或性能对照。该次未启用 NR timing，也没有同场景基线，不能解释
用户看到的菜单计时持平或略高，更不能由路线生效推出 FPS 已提升。

剩余工作按优先级：

1. 核对菜单 NR 计时具体覆盖范围，在当前版本对燕云实际 RGBA8 路线做同场景
   buffer/共享颜色/两项共享 A/B，同时记录完整帧时间、实际 NR 执行和配置。
   先确认游戏净收益，避免仅比较不同场景的菜单数值。
2. 全格式扩展后的资源标志及后续 `471d26c6` 的 0.0.7 核心更新尚无同条件性能复测；
   旧 0.180 ms 是历史 FP16 结果。复测须固定当前核心/模型/编译方式，不混用旧 pin。
3. 输出下载/回写尚未优化；历史差异约 0.04 ms，仅是调查量级。先做 scratch
   独立收益与生命周期评估，收益不足则保留原路，不为追平数字直接改产品。
4. Vulkan validation、其他 GPU/驱动及真实游戏画面/长期稳定性仍有验证缺口。
   canonical/DRS/缩放/多遍等准入外路线继续 buffer，不把扩大准入当成已证明收益。

0.0.7 新能力另见 [剩余能力统一评估](mochizuki-007-remaining-assessment.md)：
受限同模型 GraphCore/权重后台复用已接入；不同plan/跨模型activation共享仍关闭。它针对兼容重建等待与峰值显存，不是固定尺寸每帧提速。Inline 仍搁置，lmxxf 不随本方案重构。

## 状态（2026-10-19）

共享颜色与受限 motion 纹理已接入产品适配器。符合下述条件的 split 录制默认申请共享 texture，
初始化完成后采用；不支持、初始化未完成或预算不足时继续执行 buffer NR。
不新增菜单/INI 开关，不调整模型、精度、时域历史或合成语义。仅在载体 generation
变化及申请失败/退避时记录路线信息，不增加逐帧正常日志。

本轮只考虑 split。Inline 调研与修改搁置，lmxxf 不随本方案重构。共用层实际改动时
才复用相应非回归检查。原版指 Mochizuki 原版，不指本项目分支。

## 已定位的开销

相同 D3D12 设备/队列、2558×1449 RGBA16F、连续帧、单遍、完整模型比例与时域历史，
新旧模型及编译方式对齐后，产品桥接比原版约多 0.28–0.31 ms。原版 PE 桥接使用共享
D3D12 texture/Vulkan image；产品先 texture→共享 buffer→私有 image，输出再反向搬运。
核心同设备对照持平，改变原版核心录制时机没有复现主要差距。

阶段计时中，输入捕获约多 0.105 ms；Vulkan 核心前约 0.170 ms，包含颜色与 motion
两项上传，不能称作颜色单项。输出下载与写回差异量级约 0.04 ms。区间中位数不直接
相加当作整帧成本，未解释的剩余跨度不指定为某种驱动调度机制。

这不是游戏总 FPS 结论。举例原版 70 FPS 且新增耗时全在 GPU 关键路径：增加 0.29 ms
约下降 1.99%；下降 5% 则需约 0.752 ms。用户实际基准帧率、接法、NR 分辨率、
模型/编译/compose 配置与同场景帧时间仍需核对。

## 为什么简单跳过上传不能直接当收益上限

临时实验在一次合法 seed 后跳过颜色或 motion 上传，保留合法布局与完整 dispatch。
跳过颜色后继续消费上一帧输出，改变了后续核心输入；新模型中上传区间约缩短 0.138 ms，
核心区间却约增加 0.240 ms，整段约慢 0.092 ms。该结果只说明这个反事实受内容变化影响，
不能用于否定共享纹理，也不能称作可用 NR 优化。

固定 seed 的 image→image 恢复对照可保持静态输出一致，但新增复制本身又有成本。
因此最终以真正导入的共享纹理配对探针判断收益，没有把上述反事实直接外推到产品。

## 共享颜色纹理探针

RX 9070 XT，驱动 `32.0.31041.1004`，MSVC 14.44.35207/SDK 10.0.26100.0，Release。
未锁 GPU 频率；HAGS 未核实。vendored 核心 pin 为
`191b97b54175d50c7ec5992b54322dd3eb0ef8ac`，原版参考为
`ab00d2b23584de0f42ac91eca4d7d2d2fad11465`。不加载完整 OptiScaler 宿主/游戏。

每个比较在同一进程、同一 runtime 与相同 D3D12/Vulkan 设备中切换：

- buffer 基线：沿用产品原有颜色和 motion 上传。
- 颜色候选：D3D12 捕获到自有共享纹理，单 Vulkan 队列族、EXCLUSIVE，使用 EXTERNAL
  acquire/release；核心直接在导入 image 上读写。motion、输出下载与 D3D12 写回保持原路。
- 初始 UNDEFINED→GENERAL 在第一次 D3D12 捕获前完成。初始化用独立 fence 非阻塞查询，
  没有 `vkQueueWaitIdle`；每帧不再用 UNDEFINED 丢弃捕获内容。
- 四轮正反序；各段 ResetHistory 后以相同帧数推进，再预热和测量。每帧重新录制，
  计数核对完整网络提交及 dispatch。hash 在段末核对；变化输入检查另外逐帧核对。

| ACO 组合 | 每段计时帧 | 整段节省中位数 ms | 四轮节省范围 ms | 计时内成功 NR |
|---|---:|---:|---:|---:|
| 新模型、RGBA16F motion、标记开 | 240 | 0.0786 | 0.0242–0.1078 | 1920/1920 |
| 原模型、RGBA16F motion、标记开 | 180 | 0.0936 | 0.0071–0.1257 | 1440/1440 |
| 新模型、RG16F motion、标记开 | 180 | 0.0996 | 0.0844–0.1060 | 1440/1440 |
| 新模型、RGBA16F motion、标记关 | 180 | 0.1578 | 0.0565–0.2584 | 1440/1440 |

每行在自身会话内配对；不能用不同行绝对值相减判定标记成本。计时内共 6240 次成功
执行，新模型每帧 71 次网络 dispatch，原模型 123 次；没有靠减少网络执行获得收益。
段末输出 hash 均与对应基线一致。RGBA16F 与 RG16F motion 分别建立配对，不混用基线。
RGBA16F motion 的颜色上传区间约减少 0.142 ms，捕获约减少 0.015–0.016 ms；总收益
仍需报告实际整段测量，不能把阶段节省相加代替它。

额外正确性检查：

- 新模型原生编译：两轮正反序、两个交替变化输入，16 个计时帧逐帧 hash 配对一致。
- 新模型 ACO、RG16F motion：同样检查 128 个计时帧；输出确实随输入变化。
- 两条路线关闭录制后反向切换请求，录制内容保持原路线；后续 Prepare 才采用新请求。
- 五次交替选择 texture/buffer 并注入核心录制前失败，image→buffer 或 buffer→buffer
  旁路输出均与当前捕获输入 hash 一致；故障期间零成功网络提交，五次旁路单独计数。
- 上述调试检查 D3D12 debug layer 错误数为零；没有启用 Vulkan validation，不能据此
  宣称全部 Vulkan VUID 或驱动组合已验收。

上述为接入前探针，收益低于最初约 0.15–0.20 ms 的预期，但实际路径存在可重复正收益。
该目标是工程估计，不是必须凑足的合入门槛。不能宣称回收全部 0.3 ms、提升游戏 FPS
或解决用户 5% 反馈。

## 产品准入与回滚

当前共享颜色准入复用 `ColourFormat` 的完整现有映射（23 个 DXGI 枚举、14 种 typed
载体），逐设备查询导入能力；全尺寸单 mip/单层/单采样纹理、单遍、完整模型比例、
实际 motion 输入和普通 compose。canonical 转换、bucket/DRS、first-pass 导出、RenoDX、
无 motion 及 Inline 均使用现有 buffer 路线。颜色满足上述条件后，完整尺寸、无 rescale/pad、
RG16F 或 RGBA16F 的已上传 motion 也可独立采用共享纹理；不满足 motion 条件或申请失败时
保留“共享颜色 + buffer motion”。输出不变，
直接复用核心对 `colourImage` 的原地处理，不修改 vendored 核心或增加 `EngineFrame::target`。

颜色格式的字节解释、是否线性及输出处理沿用原 buffer 路线。sRGB 用其 UNORM
同族载体保持既有字节语义，TYPELESS 使用映射表指定的 typed 同族；不会为了采用快路
更改游戏的 SDR/HDR 或 Linear 设置。共享输入只申请复制与采样用途，不要求 UAV/storage。
BGRA/BGRX 虽然映射到同一 VkFormat，其 shared carrier DXGI 格式仍进入候选/缓存匹配。

`MZ_TEST_SHARED_INPUT=0` 在进程启动前设置，可靠选择颜色和 motion 的原 buffer 路线；
`MZ_TEST_SHARED_MOTION=0` 可单独保留 buffer motion。缺省或 `1` 仅请求
通过全部安全/能力/预算准入的共享路线。这是内部诊断入口，不属于用户配置优先级，
不提供产品热切换 ABI。临时同进程 A/B 夹具通过私有派生 setter 请求后续录制，已关闭
录制始终保持自己的路线、资源及 generation。

## 所有权、排序和故障处理

- `ImageInput` 分别拥有颜色或 motion 的 D3D12 texture、Vulkan import/image、初始化 pool/fence，
  `FrameBuffers` 与 recording 直接持有它。其他资源的 `FrameBuffers::allocation` 不再
  强持旧颜色/motion buffer；Steal/Take/Use/Release、几何退休和设备丢失保留均携带两种所有者。
  旧录制存在时允许暂时共存；仅以 weak cache 缓存两种载体，防止永久双持。
- 初始化在同一 Vulkan 队列族上使用 EXCLUSIVE + EXTERNAL 交接。独立 fence 非阻塞
  查询 Ready；申请提交前先登记强持有，即使用户未提交游戏录制就丢弃也不提前释放。
  可选初始化以 try-lock 避免等候网络构建；没有新增 render-thread queue/device idle。
  每帧从 GENERAL acquire，在下载后 release 回 GENERAL，不用 UNDEFINED 丢弃输入。
- `BeginRecordingExecution` 保留 previous consumer tail 的捕获前 GPU wait。
  录制 Collect 同时核对 D3D12 尾部和该录制**实际被接受的 Vulkan 完成值**；路线退休
  也持有旧载体直至 Vulkan 完成。不是用 later frame 或 `Follow` 推断当前帧完成。
  不确定/设备丢失沿用 quarantine；没有为了回收而强行释放导入资源。
- `Submitted` 在可分配/抛异常的诊断记账前记录完成凭证。split 已被接受的提交若记账
  失败，则禁止重试和继续执行；核心开始推进 CPU 历史后的录制错误也禁止改走旁路
  重录同一帧。只有安全的核心录制前失败才允许 image→buffer 或原 buffer→buffer 旁路。
- 旁路缓存检查颜色 generation、输出 buffer 和 extent；换路线使缓存失效，复用命令
  前仍检查其完成 fence。texture 旁路包括 EXTERNAL acquire/release；入口不再误要求
  快路不存在的 `input.buffer`。
- 不支持能力缓存为不可用，可恢复导入/共享句柄错误使用 `kInvalidRetryMs` 退避，
  预算拒绝保持 10 秒，避免逐帧申请或路线抖动。可选候选失败保留可执行的 buffer NR，
  不调用整体预算拒绝的 `ReleaseNetwork`。device loss 继续按丢失处理。
- FrameBytes 按实际颜色/motion allocation 替换各自估算项，候选另查实际进程用量、增量分配和
  预算余量。现有 buffer 的 16 MiB 驱动规避保持原样，不套给 texture。2558×1449 本机
  buffer 颜色载体为 59,834,368 字节、shared 为 30,146,560；旧录制收集后可释放差额
  29,687,808 字节（约 28.31 MiB），而非永久叠加一张共享纹理。

实现入口为适配器的 `MochizukiImageInput.inl`、`MochizukiColourRouting.inl`、`MochizukiMotionRouting.inl`、
`MochizukiNrRuntime.cpp` 及 `MochizukiRecording.inl`。宿主 ABI、lmxxf、Inline 算法不变。

## 产品验证范围

复用现有 runtime ABI、split retained recording、GPU 格式/几何/生命周期检查和宿主
early-unity/inline-discard 所有权检查；新增故障控制和 A/B 只在临时夹具中使用，
没有新增测试项目。检查包括变化输入逐帧 hash、保留两种路线录制、跨两条 D3D12 队列
重放、几何改变、未提交丢弃、消费者尾部未完成、旧 buffer 释放和共享句柄拒绝。

两个独立 GPU gate 还检查了初始化未完成即丢弃后 Destroy 等待独立初始化凭证，以及
Vulkan 已接受但记账抛异常时 D3D12 尾部已完成仍拒绝 Collect，Vulkan 完成后才允许回收。
预算注入确认连续 buffer NR、原网络保留及预算恢复后重新准入。D3D12 debug layer
未报错误；没有启用 Vulkan validation，也没有覆盖真实硬件设备丢失与全部驱动组合。

接入后的离线 A/B（同机、同设备、四轮正反序）：

| 工作负载 | 配对节省中位数 ms | 计时内成功 NR |
|---|---:|---:|
| 新模型 ACO、RG16F motion、阶段标记开 | 0.0939 | 1920/1920 |
| 原模型 ACO、RGBA16F motion、阶段标记开 | 0.1126 | 1440/1440 |
| 新模型 ACO、RG16F motion、阶段标记关 | 0.0978 | 1920/1920 |
| 最终版本完整宿主、新模型、正常日志、NR+FSR2.1.2 | 0.0836 | 1920/1920 |

前三行在最终补充 Vulkan 回收凭证前测量，输出 hash 对应相同；补充后重跑变化输入、
故障、生命周期、现有 GPU/ABI 和完整宿主检查。最后一行加载实际 Release 宿主与带私有
计数入口的同源码 runtime，NR 2558×1449、SR 输出 3840×2160，每段预热 40、计时 240 帧。
四轮配对差为 0.0679、0.0903、0.0770、0.1130 ms；无减少网络执行。此前一次宿主探索
会话为 0.1732 ms；未锁频且会话有波动，不能只选较大收益，也不能把两次差值归因于
回收凭证。当前可确认的是本机受限 split 有正收益，精确游戏收益仍需实测。

以上是颜色单项接入时的历史验收；motion 的后续产品验收见末节。输出最后评估或不做。
仍需真实游戏、Present/FG/FSR4、长时间运行
及其他 GPU/驱动验证；不能将离线 NR+SR 耗时直接称为游戏 FPS 改善。

## 接入后三路同条件复测（2026-10-19）

基于产品提交 `2c437d76`，复用原版桥接对照夹具、原版 core/PE bridge 与本次产品
适配器，只在临时派生 runtime 加时间戳/路线选择/计数。一个进程内使用同一 D3D12
设备与队列，对比原版、产品 buffer、产品共享颜色三条路线；各有既有 Vulkan 设备。
六轮遍历三条路线的全部顺序，每段重置历史、预热 40 帧，Small 计时 240 帧、
Original 180 帧。原版与产品均 ACO 生效、同权重、完整比例/单遍/时域，2558×1449。
每帧重新录制，核对完整 dispatch（71/123）与网络次数，各轮三条路线输出 hash 相同。
RX9070XT/32.0.31041.1004，未锁频，HAGS 未确认；没有启动游戏。

表中单位为 ms，均为六轮**配对差中位数**，正值表示额外耗时或节省：

| 组合 | buffer 比原版多 | 共享颜色比原版多 | buffer→共享颜色节省 |
|---|---:|---:|---:|
| Small、RGBA16F motion、阶段标记开 | 0.3166 | 0.1890 | 0.0946 |
| Original、RGBA16F motion、阶段标记开 | 0.2985 | 0.1899 | 0.1188 |
| Small、RG16F motion、阶段标记开 | 0.2658 | 0.1775 | 0.0311 |
| Small、RG16F motion、阶段标记关 | 0.2602 | 0.1795 | 0.0897 |

不同配对差分别取中位数，不满足逐列相减的代数恒等式；不能用前两列相减替代第三列。
三组 Small 各 4320 次、Original 3240 次，共 16,200/16,200 次 NR，所有段末 hash 相同。
关闭阶段标记的 RG16F 组节省范围为 0.0543–0.1286 ms，残差为 0.1169–0.2163 ms。
带标记 RG16F 组节省范围为 -0.0697–0.2243 ms，出现负值，须保留并报告其波动；
不能用它断言稳定 0.031 ms，也不能与关闭标记组相减认定标记本身造成差距。

按相同 RGBA16F motion 口径，原约 0.3 ms 桥接差距仍能复现；颜色优化追回约
0.095–0.119 ms，仍多约 0.19 ms。更接近宿主的 RG16F、无阶段标记组追回约 0.090 ms，
仍多约 0.180 ms，与上一轮完整宿主的 0.084 ms 收益量级一致。

阶段定位（共享颜色减原版，阶段标记开；各项中位数不直接相加代替整段）：

| Small 剩余阶段差 | RGBA16F motion | RG16F motion |
|---|---:|---:|
| D3D12 捕获 | 0.0901 | 0.0552 |
| Vulkan 核心前（含 motion 上传/ownership） | 0.0287 | 0.0218 |
| 核心标记区间 | 0.0343 | 0.0518 |
| Vulkan 输出下载 | 0.0285 | 0.0274 |
| D3D12 写回 | 0.0131 | 0.0138 |

同轮 buffer→共享颜色的 RGBA16F 组核心前区间减少约 0.140–0.143 ms、捕获减少约
0.021 ms，但核心区间增加约 0.033–0.050 ms，抵消了部分节省。因此上传区间的节省
不能直接当作最终收益。共享图像布局/缓存行为和顺序/频率波动是待区分因素；本次
没有改变核心代码或权重，未证明某一种因素就是原因，也不能称为纯网络算力退化。

下一步先在临时夹具中核对核心区间增长及 motion 独立省拷贝的实际收益，再决定产品
motion 接入；不能预支上表捕获差作为全部可回收收益。输出约 0.04 ms 的量级仍放最后。
本轮只复测与记录，没有新增产品代码、测试项目或包。

## 核心区间与 motion 独立实验（2026-10-19）

本轮仍只修改临时夹具。将原“核心区间”进一步拆成网络 dispatch（71/123 次）与
核心附加工作，包括输入复制/编码、合成和写回。核心自带四槽计时环在录制 j 时读取
j−3 的结果；原始逐帧数据按这个固定偏移对齐，再分析同帧区间，未把延迟样本当作当前帧。
各段重置历史、预热 24 帧，通常以 64 帧短段轮换；另加同路线 A/A 和同图像两路线
16 轮 × 32 帧对照。源、权重、编译及全部 dispatch 保持一致。

### 对核心增长的判断

交叉四种颜色输入，保留同一对 buffer/private 与 shared carrier，避免每段重新分配：

| 颜色实验 | Small、RG16F motion：比现有快路多 ms | Original、RGBA16F motion：多 ms |
|---|---:|---:|
| 原 buffer 上传至私有 image | 0.1197 | 0.1070 |
| 现有共享颜色 image 原地处理 | 基线 | 基线 |
| 共享捕获后复制回同一私有 image | 0.0388 | 0.0556 |
| buffer 上传至**同一共享 image** | 0.1158 | 0.1193 |

这是完整桥接区间，不能用核心局部减少抵消新增复制后就宣称整段更快。关闭额外阶段
标记的 Small 组，复制回私有 image 仍多 0.0527 ms；没有恢复这条产品中间复制的依据。

Small 的私有/共享颜色核心差未复现此前固定约 0.03–0.05 ms 惩罚：两者外层核心区间
配对中位仅约 0.0021 ms，按同帧对齐后的网络 dispatch 差约 0.0019 ms。不能称共享
图像始终拖慢网络。A/A 外层核心差的范围为 −0.0184–0.0230 ms，说明这类小区间也有波动。

Original 仍有输入方式相关的附加成本。保持同一共享 image/分配，只把 D3D12 捕获
换成 buffer 上传，核心附加工作可减少约 0.0365 ms，其中编码约 0.0182 ms；同路线 A/A
附加工作中位差约 0.0003 ms。因此“分配成共享图像本身就慢”不能解释该差异，变化还
依赖输入的生产方式。合成阶段差约 0.00002 ms，没有出现相应固定增长。

可确认的原因层级是：旧外层标记把核心内部输入准备/编码也计入“核心”，输入生产方式
会改变这部分成本，且整段含测量/调度波动。尚未用硬件计数器区分缓存、压缩元数据、
时钟与具体 barrier 依赖，不能把其中一个写成已证明的底层原因，也不能把增长都归为噪声。
**保留现有共享颜色路线，不因此改网络算子、精度、日志或补回私有 image 复制。**

### motion 的独立收益

在颜色固定为当前共享快路时，分别测试：正常 buffer 捕获/上传；只保留一次合法 motion
seed 后跳过后续上传；真正的 D3D12 共享 motion texture/Vulkan image；seed 后同时
跳过捕获与上传。seed 对照仅用于恒定 motion 夹具，motion image 是只读，未使用未初始化
数据，也没有像颜色 P0 那样反复把输出当输入。它仍不是所有负载的严格整段收益上界：
删掉前置工作也会改变后续执行状态，必须用真实候选判断是否值得接入。

以下均相对“共享颜色 + 原 motion buffer”，单位 ms、配对节省中位数：

| motion 工作负载 | 只跳过上传 | 真正共享 motion | 同时跳过捕获/上传（恒定输入控制） |
|---|---:|---:|---:|
| Small、RG16F、阶段标记开 | 0.0158 | 0.0691 | 0.0751 |
| Small、RG16F、额外阶段标记关 | 0.0006 | 0.0619 | 0.0550 |
| Original、RGBA16F、阶段标记开 | 0.0287 | 0.1189 | 0.1447 |

Small 的真正共享候选，阶段标记开时八轮均为正，范围 0.0097–0.1286 ms；关闭时六轮正、
两轮负，范围 −0.0900–0.1407 ms，全部保留。按同帧扣除网络 dispatch 后，关闭标记组
剩余桥接区间配对中位约省 0.0739 ms、八轮均正；该量只帮助定位，不替代上表原始整段
0.0619 ms，也不作为游戏 FPS。Original 组六轮为 0.1011–0.2251 ms；motion 每像素字节
数不同，不能据此将新旧模型差额归为模型因素。

真实 motion 候选以 texture→texture 捕获替代 texture→buffer，Vulkan 直接消费导入
image，保留逐帧 motion 更新及 EXTERNAL acquire/release。
Small 在 ACO/原生编译各自对照中，交替变化颜色和非零 motion：64/32 个计时帧逐帧
输出 hash 对应相同，且输出随输入变化；没有比较 ACO 与原生编译之间的 hash。
全部正式实验与 A/A 共 15,968 次计时 NR，另 64 帧调试冒烟，完整网络次数/dispatch 均核对。
启用 D3D12 debug 的变化输入检查 errors=0；未启用 Vulkan validation、未跑真实游戏。

### 决定与产品准入要求

motion 值得继续受限最小接入，颜色路线保持现状，输出继续后置。本轮的 motion 资源
由实验 Session 全程持有，并同时保留原 motion buffer/image；不具备产品的几何退休、
录制回收和稳态显存回收，不能直接复制进默认路径。产品修改前必须补齐：

1. 只覆盖 split、已支持的 RG16F/RGBA16F、完整 extent/单 mip/单层/单采样、无 rescale/
   pad/DRS 的已上传 motion；其他输入仍走 buffer。不改变运动向量缩放和时域语义。
2. motion 独立所有者固定到每份 recording，纳入缓存、几何退休、丢失保留与实际 Vulkan
   完成 + D3D12 tail 双侧证明。复用颜色初始化机制，不能在 render thread 等 queue idle。
3. 独立能力/句柄退避与候选峰值预算；申请失败保持现有“共享颜色 + buffer motion”，
   不重建网络、不额外重置历史。旧录制收集后释放多余载体，不能永久双持本实验资源。
4. 保留内部 A/B 回滚入口，检查保留录制、跨队列/重放、几何/格式变化、未提交丢弃、
   初始化和提交记账故障；再用同条件三路与完整宿主确认收益，不能把两轮中位数直接相加。

这些是下一次产品修改的验收边界，本轮只完成调查、scratch 验证和路线决定。

## motion 产品接入及同条件验收（2026-10-19）

在上述独立实验后，将 motion 纳入产品的 `ImageInput` 所有权机制。颜色和 motion
分别保留载体，初始化列表与退休完成查询共用；准入在 recording 快照前决定，已关闭
录制不随下一帧请求改变。候选失败不释放网络、不重置历史，也不撤销共享颜色。
预算恢复不会绕过既有 10 秒退避；到期且能力、几何与预算允许后自动重新申请，就绪才绑定。
旧 buffer 仅由仍需它的录制持有，收集后释放；没有永久保留双套载体。

复用现有 ABI、split retained、GPU、early-unity/inline-discard 边界检查，临时夹具补充：

- 三条路线分别保留和跨两条 D3D12 队列重放；格式/几何变化、未提交丢弃、消费者尾部
  未完成及旧 motion buffer 最后引用释放。
- motion 导入拒绝、初始化延迟、初始化受 GPU gate 阻塞时丢弃及 Destroy；实际 Vulkan
  已接受后记账故障同时保留两种输入完成凭证，D3D12 尾部先完成仍不能提前收集。
- 候选预算拒绝时连续执行 NR；预算恢复但未到退避时间继续 buffer motion，10 秒到期
  自动重入。默认两种共享输入、motion 单项回滚、全部 buffer 回滚均验证实际路线。
- ACO/原生编译各自变化颜色与非零 motion 逐帧输出对应一致；完整网络 dispatch 不减少。
  DRS rescale/pad/subrect 实际执行回退，以及低分辨率 motion 保留共享颜色，均通过。

12 项集中检查及额外回退执行通过。启用 D3D12 debug 的集中检查未报错误；回退执行
只检查输出与实际路线，未额外统计 InfoQueue。测量窗口 System/4101 事件为零；没有启用
Vulkan validation，也没有模拟真实硬件 device loss。验证没有新增跟踪测试项目。

同机 RX9070XT/32.0.31041.1004、2558×1449、ACO、单遍完整比例，每会话六轮遍历
三路线全部顺序，每段重置历史、预热 40 帧；Small 计时 180 帧、Original 120 帧。
以下为各自会话配对差中位数（ms），不同列独立取中位数，不能代数相加：

| 产品适配器路线对照 | buffer→共享颜色 | 共享颜色→再共享 motion | buffer→两项共享 | 成功 NR |
|---|---:|---:|---:|---:|
| Small、RG16F motion、阶段标记开 | 0.0882 | 0.0753 | 0.1550 | 3240/3240 |
| Original、RGBA16F motion、阶段标记开 | 0.1142 | 0.0693 | 0.1998 | 2160/2160 |
| 完整 Release 宿主、Small RG16F、正常日志、无额外阶段标记 | 0.1394 | 0.0437 | 0.1800 | 3240/3240 |

宿主运行真实 NGX + FSR2.1.2，NR 2558×1449→SR 3840×2160。motion 六轮增量均为正，
范围 0.0238–0.0932 ms；两项合计范围 0.1622–0.2103 ms。使用同源码带私有计数入口
runtime 和实际 Release 宿主，另对未插桩产品 DLL 执行 ABI/retained/GPU 检查。

独立原版三路对照（均有相同额外阶段标记、相同权重/输入、段末 hash 一致）：

| 工作负载 | 产品 buffer 比原版多 ms | 两项共享比原版多 ms | 产品内部节省 ms | 成功 NR |
|---|---:|---:|---:|---:|
| Small、RG16F motion | 0.2778 | 0.1071 | 0.1685 | 3240/3240 |
| Original、RGBA16F motion | 0.3234 | 0.1282 | 0.1856 | 2160/2160 |

五组计时共 14,040/14,040 次 NR。模型间 motion 格式不同，不能把收益差归为模型因素。
这也不是把旧颜色会话约 0.084 ms 加上 scratch 数字；当前表是完整产品同条件复测。
仍有约 0.11–0.13 ms 离线桥接残差，输出搬运尚未修改。

Small RG16F 本机 motion 载体从 32,505,856 降至 15,728,640 字节，稳态少 16 MiB；
连同颜色共少约 44.31 MiB。候选峰值仍计入旧载体及在途录制，不能直接按稳态差额放行。
未锁 GPU 时钟、HAGS 未确认；没有真实游戏、Present/FG/FSR4 或跨厂商驱动验证，
因此不能承诺游戏 FPS、所有画面/兼容情况或用户 5% 反馈已经解决。

## 全颜色格式覆盖与验证（2026-10-19）

共享载体从单独的 FP16 准入扩展到适配器原有颜色格式全集，不增加原适配器从未支持的
颜色编码。`ColourFormat` 同时给出 VkFormat、每像素字节数与 typed carrier DXGI；
共享申请与原 buffer 共用这一信息源。所有项仍要求既有 split 几何准入及当前设备可导入，
不代表 canonical、DRS、模型缩放、多遍等路线也全部启用共享输入。

| typed 载体 | 同时覆盖的现有 DXGI 变体 |
|---|---|
| R16G16B16A16_FLOAT | FLOAT、TYPELESS |
| R32G32B32A32_FLOAT | FLOAT、TYPELESS |
| R11G11B10_FLOAT | FLOAT |
| R10G10B10A2_UNORM | UNORM、TYPELESS |
| R8G8B8A8_UNORM | UNORM、UNORM_SRGB、TYPELESS |
| B8G8R8A8_UNORM | UNORM、UNORM_SRGB、TYPELESS |
| B8G8R8X8_UNORM | UNORM、UNORM_SRGB、TYPELESS |
| R9G9B9E5_SHAREDEXP | SHAREDEXP |
| R16G16B16A16_UNORM | UNORM |
| R16G16B16A16_SNORM | SNORM |
| R8G8B8A8_SNORM | SNORM |
| B5G6R5_UNORM | UNORM |
| B5G5R5A1_UNORM | UNORM |
| B4G4R4A4_UNORM | UNORM |

共 23 个枚举、14 种载体。sRGB 继续使用既有 UNORM 字节解释，避免共享导入额外施加
传递函数；这不改变用户设置的 Linear/曝光/SDR/HDR 策略。TYPELESS 不猜测为整数或
新增编码，沿用原 buffer 的代表格式。BGRA 与 BGRX 保持各自 DXGI 同族资源，并加入
候选缓存匹配；相同 VkFormat 并不足以证明 D3D12 CopyResource 兼容。

原版的共享桥接可协商 storage 或普通采样/复制资源。产品当前 split 路线传给核心的
usage 始终是 TRANSFER_SRC/DST + SAMPLED，写回也采用 transfer；因此去掉此前共享
候选额外要求的 typed UAV 与 D3D12 ALLOW_UNORDERED_ACCESS，不改变核心算法。
可选导入失败、初始化/预算/退避/双侧完成凭证及内部回滚行为沿用上一节。

RX9070XT / 32.0.31041.1004 的离线夹具真实创建每一种格式，在 Small 与 Original
两种模型下分别验证全部 23 项：每项实际采用共享载体，变化颜色与非零 motion 的
12 帧连续序列逐字节等于 buffer 路线；包含 alpha、浮点负值/超 1 和打包布局。
另外覆盖保留录制、两条 D3D12 队列重放及核心录制前故障的原始输入旁路。

五种代表格式另在原生编译下作各自配对；两种格式注入共享句柄拒绝仍完整执行 buffer
NR。BGRA↔BGRX、TYPELESS↔sRGB 同 VkFormat 切换时保留旧录制，验证载体身份、
跨队列输出与恢复。FP16↔R11G11B10 切换验证 Plan A 转换期间使用 buffer，旧共享录制
仍有效，返回原格式后重新采用共享载体。1920×1080 RGBA8 + RG16F motion 也作同样
连续输出/回收/故障检查。完整环境对照显式核对实际生效的 ACO 模式。

正式矩阵与补充场景共 15 轮、59 组，实际执行 3656 次 NR，另核对 59 次注入旁路。
现有未插桩产品 ABI、split retained 和 GPU 检查通过；D3D12 debug ERROR/CORRUPTION
为零，测量窗口 System/4101 无事件，没有新增跟踪测试项目。
上述是路线、输出与生命周期验收，不是全格式性能测量；此前约 0.180 ms 的宿主收益
对应上一轮 FP16 实现，不外推为本次每种格式的收益，资源标志改变的耗时也需单独测量。
未启用 Vulkan validation，其他 GPU/驱动、真实硬件 device loss 与真实游戏观感/收益
仍待实际验收；不以本机所有格式成功导入承诺全部设备都能走共享路线。
