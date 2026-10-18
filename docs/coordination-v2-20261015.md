# 调度协调 v2：实现与 GPU 验收

日期：2026-10-15。**本版仍是实验性实现，GPU 验收已启动，尚无通过验收的性能结果。** 外部 GPU 测试结束后，已用包含 B0/B2 对照的 v2 队列替换尚未开始的 v1 队列；原始源码快照和失败日志均保留。新开关默认关闭。

## 当前优先项：离线批量推理

按用户最新要求，优先实现有一批数据时持续补位的吞吐模式。17:22 已停止
本聊天的 r6 后续五轮队列，保留已完成的有限会话结果，改跑
`offline-live-r1`。下文旧队列的“正在运行”描述是当时记录，不是当前状态。

新增 `scripts/offline_workload.py`，由 `scripts/qualify_coordination.py --cases offline`
调用。每个样本完成后，该 worker 立即领取下一个样本，不等整批完成；入口
默认保持 16 个在途请求，GPU active 上限仍为 8。请求在服务端继续执行
chunked prefill、连续批处理以及 KVMem 的逐请求异步重选。CPU 历史和 active
预算、DMA fence 仍然有效，不通过超额驻留、不保留历史或 SSD 换取吞吐。

本模式关闭 `adaptive_prefill`，不按延迟目标缩小 prefill。B0 与 B3 都使用
持续补位；区别仍是新增 CPU 历史准入／维护协调／异步恢复是否开启。因此
两组比较能检验协调策略在持续负载下的效果，不能单凭该比较声称客户端
补位本身带来了某个百分比的提升。独立离线样本不保留跨轮 session，异步
跨轮恢复在这一工作负载中不会被充分触发。

输入为 JSONL，每行是独立样本，例如：

```json
{"id":"sample-1","prompt":"Question: What is 2 + 2?\nAnswer:","max_tokens":128}
{"id":"sample-2","prompt_token_ids":[1,2,3,4],"query_span":[1,3],"max_tokens":128}
```

`prompt` 是原始 completion 文本，不会自动套聊天模板；也可直接提供已经
套模板的 `prompt_token_ids`。`query_span` 是原始输入 token 的半开区间；
应按数据集标明真正的 Query，缺省沿用压测的末尾短 Query 策略。
真实数据默认允许 EOS 提前结束；固定长度吞吐实验显式用 `ignore_eos:true`。
输入在启动 GPU 前完成分词、预算校验并冻结，所有 arm 读取同一份 token ID。
每题隔离 prefix cache，防止重复合成文本制造跨样本缓存收益。

单批数据运行命令如下；B0 使用已有 KVMem 路径，后续可用 `--arms B0 B3`
作同条件协调对照。配置必须是 native serving profile，机器路径和预算需
匹配实际环境，结果目录必须独立。可从
[offline native 示例](../examples/qwen-nvfp4-offline-native.json) 修改本机模型路径；
该示例关闭新增协调策略，保留 CPU 历史、异步重选和注意力评分。

```bash
PYTHONPATH=src /home/chaidi/kvmem-vllm/.venv/bin/python scripts/qualify_coordination.py \
  --config /absolute/path/to/native-profile.json \
  --output /absolute/path/to/offline-results \
  --cases offline --arms B0 --pairs 1 --step-latency-interval 4 \
  --offline-dataset /absolute/path/to/input.jsonl --offline-concurrency 16
```

附加 `--prepare-only` 只准备输入，不占 GPU。正常运行仍等待连续 120 秒
GPU 空闲，不停止外部作业。`pair-00-B0/offline/responses.jsonl` 逐题保存
完成结果及错误；最终 `traces.json` 按输入顺序排列。记录包含样本 ID、
输出 token、输出文本（r1 后补入）、输入／输出摘要和时间线。失败没有自动
重试，也不会从总样本数中删除；未成功输出不能贡献有效吞吐。

评估区分整批完成时间与持续积压区间：前者包含请求填充和末尾排空，后者
固定排除前 30 秒，并在最后一个样本提交时结束，不挑最快片段。另记录
GPU 利用率抽样、低于 10% 的抽样占比、engine running/waiting、实际模型
步的 prefill/decode 请求数及完整批次比例。running=8 不代表每步计算了
8 个请求；有排队请求也不证明它们已准备好执行。`logical_input_tokens_per_second`
是输入服务速率，不能当作纯 GPU prefill 吞吐。
两种计时均从模型启动和公共预热之后开始；等待 GPU 空闲、模型加载、
编译图和输入文件的预先准备不计入推理吞吐分母。

首轮测试为固定 64 题、8K/32K/64K 混合输入，每题 1K 输出，共
2,244,608 输入 token、65,536 输出 token；NVFP4、FP8 KV、原生 MTP k=4、
编译图，CPU 历史 80 GiB，8 GPU active／16 HTTP 在途。展开数据摘要为
`362c3f65d3011b957101a359670a2999e0721248e711640f123cb913a1a4ad32`。
这是首轮模式验证，不是五轮统计验收，也不承诺所有样本组成下 GPU 100%。

17:34 首组 B0 完成：64/64 成功、零抢占，整批 476.60 秒，输出 137.51
token/s；持续积压窗口 364.53 秒、输出 137.27 token/s，GPU 利用率抽样
均值 76.36%，低于 10% 的样本占 0.58%。该窗口 engine running 均值
7.91、waiting 均值 8.00；实际模型步平均计算 7.13 个请求，完整 8 路
批次占 61.90%。这证明持续供给成立，尚未证明 GPU 满载。
原始结果位于 `offline-live-r1/pair-00-B0/offline`，后补的模型步分析为
`occupancy-analysis.json`，未改写原始结果。

17:46 B3 同样完成 64/64、零抢占，整批 480.30 秒、输出 136.45 token/s；
持续积压窗口输出 140.38 token/s，GPU 利用率均值 77.51%，低于 10%
的样本为零。CPU 历史准入全程零 deferral。B3 整批吞吐相对 B0 为 0.9923，
未观察到提升；阶段窗口的 2.27% 差异不抵消整批结果，也不是重复配对的
统计结论。独立离线样本示例先保留 B0，未默认开启新增协调功能。

第二个参数实验在同一批输入上将普通 prefill 分块从 1024 提高到 2048，
原生批次 token 总预算仍为 16424，注意力采样 stride=32、精度、MeanK／
Query 评分和内存预算均保持配置值。2048 对应 64 个采样 Query，仍满足
现有 launch 校验。块边界可能影响注意力历史的更新和生成轨迹，因此此
实验不等于质量等价证明，也不能把吞吐差异完全归因于调度代码。

**17:57，三组均完成。** 合计 192/192 样本成功，逐题输出均为完整 1024
token，三组均零抢占；相关 CPU 回归 30 项通过。2048 组完整结果为：

| 配置 | 整批耗时（秒） | 整批输出 token/s | 持续积压输出 token/s | 持续积压 GPU 利用率均值 |
|---|---:|---:|---:|---:|
| B0，1024-token 分块 | 476.60 | 137.51 | 137.27 | 76.36% |
| B3，1024-token 分块 | 480.30 | 136.45 | 140.38 | 77.51% |
| B0，2048-token 分块 | 421.25 | 155.57 | 165.40 | 81.66% |

2048 相对 1024 的 B0，本次整批吞吐提高 13.14%，整批耗时减少 11.61%；
持续积压区间吞吐提高 20.49%。2048 组输入服务速率为 5328.39 token/s，
不是纯 prefill 速度。其实际模型步平均有 7.02 个请求，完整 8 路批次占
57.38%；更高吞吐并不要求完整批次比例或 GPU 利用率中的某一项单独最大。
利用率仍未达到 100%，不能把入口持续有任务等同于执行侧没有空隙。

离线 native 示例现采用本次较快的 2048-token 分块、16 HTTP 在途／8 GPU
active，关闭新增协调和延迟控制器；这不是所有数据集的最优参数声明。
2048 结果为 `offline-2048-live-r2/pair-00-B0/offline`，三组合并报告为
`artifacts/scheduling-coordination-20261015/offline-summary.json`。r2 相比 r1
还增加了结果文本和计算批次指标的记录；生产模型执行源码保持相同，未
修改 vLLM 模型验证逻辑。最后的分析代码对单对结果不再给出退化的零宽
置信区间；原始冻结快照和原始结果未改写。当前只有每配置一次测试，
不声明统计显著提升，未执行新分块参数的任务质量回归。

本轮相关 CPU 回归：**270 passed、1 skipped**（跳过项为需显式开启的 GPU 测试）。
报告保存于 `artifacts/scheduling-coordination-20261015/cpu-v2-tests.{txt,xml}`。
覆盖异步恢复的请求隔离、取消和 DMA 栅栏、CPU 历史保留、旧 Query 评分的
会话边界、P rewind 超时及旧读取者排空、CPU 页号凭据、动态 prefill 与配置。

后续 GPU 输入已在 CPU 上完成准备：固定源码位于同目录 `frozen-v2`，
`v2-correctness-prepared` 为开启字节／状态校验的 8 路跨轮及工具返回场景，
`v2-performance-prepared` 为关闭校验的 5 对 B0/B2/B3/B4 性能比较。
两者保留与 v1 相同的输入 fixture；记录见 `v2-preparation.json`。

实际启动记录位于同目录的 `v2-live*`：首次发现维护预算过早读取尚未建立的
原生 KV 布局，已移至 `initialize_kv_cache` 完成之后；第二次模型、编译图和
预热成功，发现短上下文重置错误继承旧 Query 必留区间，已按验证后的前缀
限定继承。两次均在正确性阶段停止，没有将失败或预热数据计入性能。
修复后分别通过维护／恢复等 84 项和会话／测试入口等 57 项 CPU 回归
（两组不作为互斥总计）；另有 1 项真实 CUDA 状态复制测试通过。

前一固定快照为 `frozen-v2-r3`，运行目录为 `v2-live-r3`，启动信息为
`queue-v2-r3.json`。`scripts/run_coordination_sequence.py` 依次执行 8 路跨轮
正确性、逐请求恢复证据校验及 5 对 B0/B2/B3/B4 性能测试。
正确性要求 agents/burst 两种场景共 32 次恢复均有目标 KV（包含原生 MTP）
及 GDN 状态字节一致证据，失败不启动性能阶段。每个 arm 仍等待 GPU 连续
空闲 120 秒，不停止外部作业；新尝试使用独立目录，原快照不修改。

**2026-10-15 14:12（北京时间）：r3 正确性阶段通过。** 8 个会话、每场景
3 轮，两种工具返回场景的 32 次 M checkpoint 恢复均有匹配的完成证据，
17 个注意力层（其中 1 个 MTP 层）的目标 KV 和 96 个 GDN 状态张量通过
字节一致校验。报告：`v2-live-r3/restore-gate.json`。这是精确 M 恢复验收，
不扩展为所有 P rewind／取消／压力重选场景均已通过真实模型验收。
性能队列已自动进入下一阶段；校验阶段的耗时不作为性能测量结果。

2026-10-15 后续首轮发现 B4 将普通 prefill 从 1024 降至 128 token，三次
缩小、零次增加；混合与多轮吞吐回退。B3/B4 的 48 次性能阶段恢复均有
部分尾页，旧分派条件因此绕过完整页快速路径并上传整个 active view。
按用户要求，已停止本聊天拥有的 r3 后续队列，保留全部完成结果和中断状态。

修复版 `frozen-v2-r4` / `v2-live-r4` 将完整页与部分尾页分开装配：先完成
完整页的 raw-K 命中／resident V 快速路径，再从 CPU authority 恢复尾页，
最后一个 fence 覆盖两部分；尾页失败仍保留 DMA 所有权并使缓存失效。
恢复 JSONL 新增 `split_tokens`、`partial_tokens`、`raw_cache_hit_tokens` 和
`resident_v_reused_tokens`，用于核对真正减少的上传量。缓存预算保持原值。

步耗时新增模型执行前的维护／准备事件边界；控制器用相同 decode 请求数
的纯 decode 样本估计基线，并从不同实际分块大小估计固定混合开销与每
token 新增成本。总维护耗时不会直接触发缩块。若连最小块也无法达到目标，
恢复最大块以摊薄固定成本，并记录 `unattainable_target_samples`；缺少分段
时序或匹配基线时不盲目缩块。模型段仍包含原生元数据、采样、MTP 及提交
等待，不宣称是纯 kernel 时间或严格的因果成本分解。

本轮已通过 105 项相关 CPU 回归、另 142 项集成回归（1 项 GPU 开关跳过，
两组有重叠）；真实 CUDA 测试 9 项通过、4 项不适用参数组合跳过。
报告为 `cpu-tail-cost-fix.xml`、`cpu-tail-integration.xml`、`gpu-tail-fix.xml`。
r4 继续先执行 32 次真实模型恢复校验，再进行原样本、原参数的 5 轮四组
性能比较；为优先观察新控制器，顺序为 B0/B4/B3/B2，隔轮反转。

r4 的真实模型 32/32 次恢复字节校验已通过，但恢复日志显示完整页虽然进入
快速装配，raw-K 仍零命中：旧 `CaptureRuntime.finish` 在保留 CPU checkpoint
前就清空了每轮 raw-K namespace。r5 将清理移到真正的 authority 退役／会话
淘汰时；等待工具的会话只保留既有共享字节预算及每会话配额内的可替换缓存，
不会保留原生 active GPU 页或新增 CPU pins。后台索引清理仍提交给唯一的
维护线程，避免与在途装配并发修改。相关 28 项 CPU 回归通过，报告为
`cpu-retained-raw-cache.xml`。r4 的性能队列在正式测量前停止；当前运行目录
改为 `v2-live-r5`，固定快照 `frozen-v2-r5`，样本摘要与原版一致。r5 重新
执行完整恢复校验，再运行性能测试，不能用 r4 的通过替代 r5 的正确性结果。

**15:50（北京时间），r5 的 32/32 次真实模型 M 恢复校验通过。** 其中 16 次
热恢复每次命中 7,680 token 的 raw-K，减少 255 MiB KV 上传（约 12.3%），
合计减少 3.98 GiB；另外 16 次为冷恢复。完整页与 31-token 尾块均通过目标／
MTP KV 和 GDN 状态校验。结果见 `v2-live-r5/restore-gate.json` 和
`v2-live-r5/restore-cache-summary.json`。这些只证明正确性和实际搬运量减少，
不将开启字节校验时的耗时当成吞吐收益；无校验性能阶段正在执行。

**16:17，r5 首轮 B0/B4 性能结果（尚非五轮验收结论）：**

| 场景 | B0：关闭新增调度 | B4：开启新增调度 |
|---|---:|---:|
| 8 路 32K 稳态 decode，输出 token/s | 820.08 | 804.03 |
| 8 路 32K prefill，输入 token/s | 9170.77 | 9032.54 |
| 7 路 decode + 1 路长 prefill，整轮输出 token/s | 622.54 | 498.73 |
| 8 个 agent 错峰工具返回，整轮输出 token/s | 386.60 | 324.52 |
| 8 个 agent 集中工具返回，整轮输出 token/s | 375.83 | 369.56 |

两组都包含尾块装配和缓存生命周期修复。B4 混合场景保持 1024-token 上限，
未重现旧版降至 128 后无法回升的问题；但此次缺少相同 decode 并发数的基线，
实际走的是保留上限的回退策略，不能称成本拟合已经在此场景充分验证。
该场景 B0/B4 的 MTP 平均推进长度分别为 4.35/3.39，抽样纯 decode 步中位数
为 35.26/33.50 ms，且均零抢占。生成轨迹／接受率变化是吞吐差异的重要
混杂因素；既不把 498.73 相对旧 B4 的改善全归因于修复，也不将其称为超过
本轮基线。原始结果、token 轨迹和计数器均保存在 `v2-live-r5/performance`。

r5 的 agent 场景进一步发现：并发组成变化／样本过期会反复启动试探性缩块。
完整 B4 共 20 次缩小、13 次增加；错峰输出事件间隔 p95 为 216.8 ms，
明显高于 B0 的 70.7 ms。因此保留完整首轮后停止 r5 后续重复，不能将其
作为最终控制器发布。

**16:18，r6 开始重新验收。** 固定快照 `frozen-v2-r6`、运行目录
`v2-live-r6`。r6 取消仅凭一个慢样本启动的试探缩块，使用同一 decode／prefill
并发组成下自然出现的不同 chunk 大小拟合模型成本，截距包含 decode 与固定
混合开销。纯 decode 基线是截距下界，不再是拟合必需条件；缺少可辨认的
边际成本或更换到未知并发组成时恢复上限，避免把旧组成的小上限沿用下去。
前置维护时间独立记录，不参与每 token 成本拟合。相关 49 项 CPU 回归通过
（`cpu-prefill-no-probe.xml`）；对 r5 实际时序的离线策略重放，68 个混合样本
均保持 1024，12 个样本明确判定目标不可达。该重放不是新策略的 GPU 吞吐。
r6 正确性阶段改用开启控制器的 B4，再执行相同五轮 B0/B4/B3/B2 性能输入。

**16:28，r6 的 B4 正确性通过，32/32 次 M 恢复证据齐全。** 检查覆盖
17 个注意力层（含 MTP）及 96 个 GDN 状态张量，完整页／部分尾页均一致。
控制器在真实混合样本中测得约 111 ms 的固定模型开销，识别出 50 ms 目标
不可达并保持 1024-token 上限；正确性阶段零次缩块。报告见
`v2-live-r6/restore-gate.json`。正式性能阶段已启动，尚待完整配对结果。

**16:55，r6 首轮 B0/B4 五个场景全部完成。** 模型仍为 NVFP4、FP8 KV、
原生 MTP k=4、编译图，8 并发；B0/B4 均包含尾块及跨轮 raw-K 缓存修复。
本轮未出现抢占。以下为单对结果，五轮性能验收仍在后台运行：

| 场景 | B0 | r6 B4 | 相对 B0 |
|---|---:|---:|---:|
| 8 路 32K 稳态 decode，输出 token/s | 818.79 | 809.74 | −1.1% |
| 8 路 32K prefill，输入 token/s | 8781.74 | 8915.65 | +1.5% |
| 7 路 decode + 1 路长 prefill，整轮输出 token/s | 623.86 | 591.99 | −5.1% |
| 8 个 agent 错峰工具返回，整轮输出 token/s | 380.34 | 337.92 | −11.2% |
| 8 个 agent 集中工具返回，整轮输出 token/s | 363.37 | 388.22 | +6.8% |

纯 decode 那项包含首轮 prefill 的整轮输出吞吐另为 B0 428.22、B4 402.98
token/s；上表 818.79/809.74 仅为共同 decode 窗口，不能混用分母。

B4 的 56 个混合反馈全程零缩块，4 个样本测得固定成本使目标不可达；
旧版反复缩到 128 的行为已消除。48 次性能阶段恢复中 32 次 raw-K 命中，
共减少 6.40 GiB 上传（以相同 active token 数的全量上传为参照），缓存预算
未提高。恢复仍需装配及模型状态复制，搬运字节减少不等于恢复延迟同比减少。

与旧 r3 B4 的首轮相比，混合输出吞吐由 448.42 到 591.99，错峰由 269.61
到 337.92；这些是跨版本的单次观测，生成轨迹及 MTP 接受率不同，不把全额
增益归因于两项修复。当前新增调度仍没有超过同轮 B0 的全部场景，也未通过
五轮门槛，不默认开启。

剩余回退的可测线索集中在错峰恢复后的批次占用：B0/B4 抽样纯 decode
平均有 7.38/6.13 个请求，采样步中位数为 40.95/41.56 ms，MTP 平均推进
为 4.69/4.50 token；B4 需要更多不满的模型批次。混合批次样本数为 26/35，
客户端输出事件间隔 p95 为 72.7/204.9 ms。后续应检查恢复完成后的入批
协调与公平性；该观察尚不构成独立消融后的因果结论。集中返回的输出间隔
p95 为 50.3/50.9 ms，表现接近。

机器可读汇总为 `v2-live-r6/first-pair-analysis.json`，原始 token、时序和
计数器位于 `v2-live-r6/performance/pair-00-{B0,B4}`；队列随后继续 B3/B2
及后续交替顺序的配对，不用单次增益替代最终验收。

## 本版范围

- `async_restore` 将跨轮 P/M checkpoint 恢复接入已有异步维护队列：保留该请求的页和状态槽，后台装配 KV 与复制模型状态，完成事件确认后再恢复该请求入批。其他准备好的请求继续执行。取消仍需要等恢复拥有的资源安全释放。
- 恢复准备使用 fresh allocation 的 CPU 页号凭据，核对请求代际、状态槽和原始分配，并固定原生分配代码版本；无需回读 GPU 页表。凭据有效期间禁止该请求更新页表、执行公开模型或释放状态槽。模型状态复用打包的 pinned CPU 快照；普通同步恢复路径继续保留原来的校验。
- `adaptive_prefill` 用已完成的公开模型步反馈调整普通 prefill 分块上限；vLLM 原有全局 token 预算和调度顺序保留。r4 将维护耗时、相同 decode 占用的基线和 prefill 新增成本分别处理，避免固定开销把分块锁在最小值。只有存在已准备好的公开 decode 请求才应用缩小后的上限；没有可执行 decode 或反馈过期时恢复配置上限。最小块始终为正，显式完整 Query 重放不截断。
- `step_latency_interval` 控制 CUDA 事件抽样。`model_step_latency.jsonl` 记录模型步耗时与主机提交耗时，`async_restore.jsonl` 记录恢复耗时、上传量及准备耗时。诊断记录不能替代客户端延迟和吞吐统计。

`async_restore` 要求 CPU 历史配置下启用 `async_refresh`、正数 `maintenance_max_steps`、会话槽和 `session_checkpoint_policy="pm"`，并关闭 repository GC。示例 [qwen-nvfp4-coordinated-v2-elastic.json](../examples/qwen-nvfp4-coordinated-v2-elastic.json) 提供 8 并发、NVFP4、FP8 KV、原生 MTP、CPU 历史和编译图配置；路径、用户凭据、CPU/GPU 预算仍需匹配实际机器。100 GiB CPU KV 配额不等于整个进程的内存上限。

示例控制参数为：每 4 步采样、模型步目标 50 ms、普通 prefill 块范围 128–2048 token、反馈过期时间 5000 ms。这些是待实测调参的初始值，不是 SLO 承诺。

## 同条件对照

[qualify_coordination.py](../scripts/qualify_coordination.py) 保留原有默认 B0/B2 对照和工作负载参数，新增 B3/B4：

| Arm | CPU 历史准入 | 维护协调 | 异步跨轮恢复 | 动态 prefill |
|---|---|---|---|---|
| B0 | 关闭 | 关闭 | 关闭 | 关闭 |
| B1 | 开启 | 关闭 | 关闭 | 关闭 |
| B2 | 开启 | 开启 | 关闭 | 关闭 |
| B3 | 开启 | 开启 | 开启 | 关闭 |
| B4 | 开启 | 开启 | 开启 | 开启 |

即使输入 profile 开启了 v2，B0/B1/B2 也会显式关闭异步恢复和动态 prefill。比较包含 B3 或 B4 时，所有 arm 默认每 4 步采样；`--step-latency-interval` 可以统一指定正数间隔。不能只给优化组增加测量开销。仅选择旧 arm 时，默认采样保持关闭。

每组使用相同模型、MTP 参数、精度、编译图、历史配额、初始 prompt 和工具返回。跨轮保留各组模型实际输出，避免用伪造或其他组的输出替换真实会话。不同 arm 的后续生成内容可能不同，原始 token 与摘要均留档。

计划运行 5 轮配对，每轮顺序交替，比较 B0/B2/B3/B4。工作负载覆盖：

1. 8 路 32K 输入并发 decode，检查稳态吞吐是否回退。
2. 8 路 32K 输入的 prefill 服务吞吐。
3. 7 路 decode 加 1 路 64K 长 prefill，观察混合负载。
4. 8 个模拟 agent 的多轮请求、错开工具等待以及工具结果集中返回。

准备命令使用 **native serving profile**，不是 elastic gateway profile；elastic 启动计划中的 `mean_k_backend_profile` / `backend-profile.json` 是对应 native 配置。以下命令只生成配置与固定样本，不查询或使用 GPU，也不启动模型：

```bash
PYTHONPATH=src /home/chaidi/kvmem-vllm/.venv/bin/python scripts/qualify_coordination.py \
  --config /absolute/path/to/native-profile.json \
  --output /absolute/path/to/fresh-v2-qualification \
  --arms B0 B2 B3 B4 --pairs 5 --step-latency-interval 4 --prepare-only
```

GPU 验收应使用固定源码快照和独立结果目录。移除 `--prepare-only` 才进入等待/执行流程；需要连续 120 秒没有计算进程且满足空闲阈值才启动。发现其他 GPU 作业会停止本次 arm 自己的进程组，不停止外部作业。不要改写正在排队的 v1 快照，不恢复已停止的 DeepSWE 测试。

## 结果与判断

每个 case 的 `results.json` 保留原来的客户端指标：整轮输出吞吐、共同 decode 窗口吞吐、TTFT、流式输出事件间隔和请求耗时。`diagnostics.json` 另存已完成抽样的模型步 p50/p95，并区分纯 decode、混合和纯 prefill；异步恢复单独统计耗时、上传字节、主机准备时间以及同时存在公开请求的次数。每个 arm 也有汇总诊断，其中包括预热和用来释放会话的重置请求。

诊断收集放在已计时的客户端工作之后，不并入吞吐分母。case 诊断按事件开始时间筛选；后台事件可能延迟发布，最后若干事件可能没有被后续轮询收集，因此记录是“收集时可见的已完成样本”，不是完整 GPU 时间线。原始服务器 JSONL 保留用于复核。

**模型步延迟不是逐 token 延迟（ITL）。** 事件包围引擎线程中的模型前维护、原生目标模型、采样和 MTP；CUDA 事件耗时也可能包含该流等待主机提交造成的空闲，并非纯 kernel 时间。主机提交时间单独报告。MTP 一次可产生多个 token，客户端流式事件也可能合并多个 token；输出事件间隔同样不能直接等同于逐 token 延迟。恢复有其他公开请求存在，也不单独证明计算与传输已重叠，仍需真实模型时序与混合负载吞吐共同验证。

原有门槛保持不变：至少 5 对结果；纯 decode 的共同窗口吞吐中位数不低于 B0 的 98%；混合/agent 负载吞吐比中位数至少 1.10、配对重采样 95% 区间下界大于 1，且流式事件间隔 p95 比值不超过 1.05。B3/B4 分别相对 B0 报告，不将单次提升或 CPU 测试通过称为性能验收完成。还需核对跨轮恢复正确性、历史保留、取消和资源释放后再开启默认配置。
