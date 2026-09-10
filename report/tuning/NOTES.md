# DS-V4-Flash / Qwen3.8-Flash-Next 调参记录(工作笔记)

> 本文件是调参过程的**原始记录**(边测边写),结论汇总在 `docs/TUNING_REPORT.md`。
> 协议与阶段计划见 `docs/TUNING_PLAN.md`。
> 环境:3 × A100-PCIE-40GB 全部可用(生产 8070 已关)、EPYC 9654(无 AMX)、1.5 TiB RAM。
> 每次测量的 `.env`(含 uptime / GPU 占用)、服务端完整日志、客户端原生 JSON 都在
> `report/tuning/logs/`、`report/tuning/raw/`。

## 0. 工具

| 脚本 | 作用 |
|---|---|
| `scripts/tune_serve.sh` | 参数化启服务(TAG/PORT/TP/EP/MAXLEN/KV_DTYPE/GPU_UTIL/KV_MEM_BYTES/SEQS/MAX_NBT/PREFILL_MIN/THREADS/OMP/EAGER/ENV_EXTRA/OFFLOAD_PARAMS),等就绪后写 `<TAG>.meta` |
| `scripts/tune_client.sh` | ShareGPT 压测(`vllm bench serve`)+ 结果汇总到 `report/tuning/summary.jsonl` |
| `scripts/tune_sweep_serve.sh` | 串行跑多组"重启型"参数(每组独立端口,自动等显存释放) |
| `scripts/tune_nsys.sh` | nsys 抓时间线(单进程,当前 vLLM 下只能抓主进程,见 §4) |

## 1. 关键结论(随时更新)

### 1.1 256K 上下文在**单卡 A100-40GB** 上可行 ✅

| 配置 | KV dtype | KV/token | KV 容量(12 GiB 上限) | 262144 并发的倍数 |
|---|---|---|---|---|
| TP=1, util 0.90 | `fp8_ds_mla` | **29.5 KB** | **437 337 token** | **1.67×** |

- `--max-model-len 262144` 一次起服务成功;`--kv-cache-dtype fp8_ds_mla` 是关键(MLA 专用 fp8)。
- 首次尝试 util 0.90 + **默认 KV 大小**时把显存吃到只剩 1.8 GiB,GPU prefill 的
  K-major staging(`gpu_prefill._kmajor_bytes`,每层 ~2 GiB)直接 OOM →
  必须用 `--kv-cache-memory-bytes` 给 KV 设上限,给 staging 留 ≥4 GiB。
- 结论:**256K 上下文不需要 TP=2**;KV 只要 7.7 GiB(262144×29.5 KB)。

### 1.2 CUDA graph 崩溃(已修)— use-after-free

- 现象:`--enforce-eager` 关掉后,graph 捕获成功、replay 第一次 OK,**第二次 replay 段错误**
  (`[XTSIG] SIGSEGV`,栈落在引擎 `forward_many`,每个请求只出 ~2 个 token 引擎就死)。
- 根因:`cpu_decode` 每次调用 `new CpuDecodeCall{...}` 并把指针交给 `cudaLaunchHostFunc`;
  回调里用 `std::unique_ptr` **释放**了它。capture 期间回调不执行,replay 时**同一个指针被反复使用**
  → 第二次就是 use-after-free。
- 修复(`xiaotu_moe/csrc/python_binding/binding.cpp`):块里加 `graph_owned` 标志,
  `cudaStreamIsCapturing()` 判定;capture 期间的块由 graph 持有、回调**不释放**。
  修后 graph 捕获 11 个 FULL graph、replay 正常(见 §2 的 EAGER=0 数据)。

### 1.3 decode 吞吐:并发与引擎线程数是主开关

ShareGPT,输出 128 token,2×A100 单卡 TP=1,maxlen 262144,KV fp8_ds_mla:

| 并发 C | 引擎线程 | 聚合输出吞吐 | TTFT | TPOT | 备注 |
|---:|---:|---:|---:|---:|---|
| 4 | 96 | 30.5 | 9.9 s | 122 ms | 首次探针 |
| 8 | 96 | 43.8 | 6.7 s | 170 ms | |
| 16 | 96 | 37.4 | 7.3 s | 401 ms | 带 MOE-PROF 埋点 |
| 32 | 96 | 52.6 | – | – | |
| 64 | 96 | 54.9 / 57.6 | 7.1 s | – | 与 §1.4 的 48.5 同配置不同批次 |
| **64** | **48** | **29.4** | 17.8 s | 2054 ms | |
| **64** | **96** | **48.5** | 18.0 s | 1188 ms | |
| **64** | **192** | **50.3** | 16.9 s | 1148 ms | 96→192 只涨 4% |

- **引擎线程数 48→96 翻倍,吞吐几乎翻倍**(29→48),说明 CPU MoE 在关键路径上;
  96→192 收益很小(引擎并行度已够,瓶颈转移到别处)。
- 并发 4→64 只从 30 涨到 55–58,**远未线性** → 每 step 的固定成本太大(见 §1.4)。

### 1.4 每 step 成本分解(单卡 C=16,eager)

```
step_wall = 0.305 s(16 token → 52 tok/s)
  ├─ attn_43layers        0.076 s   (GPU 注意力,43 层)
  ├─ 引擎内部(A+B+C)      0.044 s   (MOE-PROF:0.65+0.36+0.02 ms/层)
  ├─ cpu_decode 入队       0.002 s
  └─ 其余                 ~0.183 s   ← 60%(GPU dense/超连接/路由 + D2H/host/H2D 往返)
```

- 引擎内部相位(每层):**A(gate/up) 0.65 ms + B(down) 0.36 ms + C 0.02 ms ≈ 1.03 ms**;
  43 层 ≈ 44 ms(占总 step 14%)。
- 也就是说:**引擎算得不算慢,慢的是"每层一次的 GPU↔CPU 往返 + GPU 侧其余算子"**。
  单层 6.5 ms 里只有 ~1 ms 是 CPU MoE 计算,其余是往返延迟 + GPU 其它算子。
- 提高并发能摊薄"每 step 的固定成本",所以 C↑ 吞吐↑;但 C=64 时每层往返涨到 ~25 ms
  (引擎工作 + 拷贝 + 回调延迟随 batch 增长),吞吐因此卡在 ~50 tok/s。

## 2. 配置明细(每次启动一行)

| TAG | 配置要点 | 结果 |
|---|---|---|
| `dsv4_tp1_kvfp8mla_256k` | TP=1 util .90 KV 默认 fp8_ds_mla | 起来;KV 526 941 token;但 GPU prefill OOM(4/8 请求失败) |
| `dsv4_tp1_256k_kv12g` | + `--kv-cache-memory-bytes 12GiB` | 稳定;KV 437 337;C=4 30.5 / C=8 43.8 tok/s |
| `dsv4_prof_c16` | + `XIAOTU_MOE_PROFILE/TIMING/DEBUG_QLEN` | §1.4 的分解 |
| `dsv4_cudagraph` | EAGER=0 | 捕获成功,replay 第二次崩溃(§1.2,已修) |
| `dsv4_cg2` | EAGER=0 + 修复后 | C=16 39.4 / C=32 52.6 / C=64 54.9 tok/s |
| `dsv4_sweep_threads-{48,96,192}` | 线程数扫描 | 29.4 / 48.5 / 50.3 tok/s |

## 3. 待验证/待优化

1. `--max-num-batched-tokens` 32768(减少 prefill 分块 → 少几轮 H2D 流式,TTFT 应该显著下降)。
   *(插件侧已修:`group_max_len` 现在跟随 `max_num_batched_tokens`,不再警告/截断到 4096。)*
2. `EAGER=0`(graph)在修复后的**吞吐**收益(C=64)。
3. GPU prefill 阈值扫描(对 ShareGPT 的 TTFT 影响最大;运行期可用 `..._MIN_TOKENS_FILE`)。
4. 引擎侧:`XIAOTU_MOE_NCGU/NCD`(每专家 N 分块数)在"专家多、每专家 token 少"时的最优值。
5. 长上下文验收(32K/128K/256K prompt 的 TTFT、显存峰值)。
6. ~~Qwen3.8-Flash-Next 单卡可行性~~ ✅ **已跑通**(见 §5)。

## 4. 工具踩坑

- **nsys 抓不到**:vLLM 的 EngineCore 是子进程,`nsys profile` 默认不跟 fork;即使设
  `VLLM_ENABLE_V1_MULTIPROCESSING=0` 仍是子进程 → 只抓到启动阶段。改用插件内的
  torch profiler(`XIAOTU_TORCH_PROFILE_DECODE`,新增于 `hybrid_model.py`)。
- **不用 `pkill -f "vllm serve"`**:命令行里出现同一字符串会把自己也杀掉(实测两次),
  改为按 `nvidia-smi --query-compute-apps=pid` 取 PID 再 kill。
- **服务重启必须等显存释放**:vLLM 启动时会检查空闲显存 ≥ `gpu_memory_utilization`,
  上一轮 context 没释放就会 `ValueError: Free memory ... less than desired`。
- **每个变体用独立端口**:端口被上一轮残留 APIServer 占着时,新服务起不来而客户端
  会连到旧进程 → 表现为 `failed=64`。


## 5. Qwen3.8-Flash-Next 单卡(本轮新能力,已跑通)

- 直接依赖 vLLM 的 `--cpu-offload-params` **不行**:UVA offloader 在模块构造后才搬参数,
  构造期 `create_weights` 已分配 47.7 GB 显存 → `Tried to allocate 47.69 GiB` OOM。
- 插件新增 `vllm_xiaotu_moe/ple_offload.py`(`XIAOTU_PLE_CPU=1`):
  ①`create_weights` 在 `torch.device("cpu")` 下执行(表建在内存);
  ②`Qwen4ExpNGramEmbedding.load_weights` 返回后立刻 pin + 换成 UVA 视图
     —— 必须在此之前完成,否则 vLLM 的 `device_loading_context()` 会把它搬回显存。
  ③<1 GiB 的小参数(FP8 `weight_scale`)要搬回设备,否则报
     "FP8 PLE embedding scale must be on the output device"。
- 实测(单卡 A100-40GB,`--max-model-len 262144`,`--gpu-memory-utilization 0.92`):

| 项 | 数值 |
|---|---|
| PLE 表 | `ngram_embedding.weight (320001536, 160) fp8` = 47.7 GiB → 主机锁页 + UVA 视图 |
| 显存 | ≈14.7 GiB |
| KV | **17.83 GiB → 728 851 token**(262 144 上下文 2.78× 并发) |
| 正确性 | `"The capital of France is"` → `" Paris. The capital of Germany is Berlin. …"` ✅ |
| ShareGPT C=8 / out=128 | 15.17 tok/s,TTFT 24.9 s,TPOT 195 ms |
| 注意 | 该模型 QSA 不支持 `--kv-cache-dtype fp8`(主线拒绝:QSA requires BF16 main KV cache) |

## 6. 其它实测结论

- DS-V4 `--max-num-batched-tokens=32768` + `maxlen 262144`:vLLM 报
  "25.83 GiB KV cache is needed" 拒绝启动(单卡不可兼得)。
- DS-V4 长上下文:32K prompt TTFT 41.0 s,128K prompt TTFT 246.8 s(分块 × 137 GiB 流式是主因)。
- CUDA graph(修复后)对 decode 吞吐无收益(48.8 vs 48.5 tok/s),但不再崩溃。

## 7. TP=2 的 decode:根因与修法(本轮)

历史数据里 "TP=2 decode 更慢(1.71 vs 4.49 tok/s)" 的根因有两条,**都是代码问题,不是硬件**:

1. **两个 rank 冗余算全量专家**:原 `finalize_mega_moe_weights()` 每个 rank 都用
   `ex.w13_weight.data_ptr()` + `cfg.expert_num = 256` 建引擎 ⇒ TP=2 时两份进程
   各算 384 个 (token,expert) pair。而 decode 的每层 CPU 时间是**串行**的
   (D2H → CPU forward_many → H2D → 下一层的 GPU 依赖它),所以步时 ≈ Σ_层
   (gpu_layer + copy + cpu_layer + copy),冗余 ⇒ 步时不降反升。
2. **共享专家的 `reduce_results=False`**:`DeepseekV4MLP` 的 `down_proj` 是
   RowParallelLinear,`reduce_results=False` 时返回**未归约的局部和**。主线 mega 模式
   传的是 `reduce_results=self.use_mega_moe`(=True),我们 OOT 里写死了 False
   ⇒ **TP=2 下共享专家静默漏掉另一个 rank 的一半**(TP=1 看不出来)。

### 修法:`XIAOTU_MOE_EP=1`(默认开,TP>1 时生效)

- 引擎只吃本 rank 的分片:`w13[st:st+L]`(dim0 连续切片,`data_ptr()` 带偏移,
  引擎按 `cfg.expert_num=L` 拷贝),`L = E/tp`,`st = rank*L`。
- forward 里把非本片 pair 的**权重置 0**:引擎 `forward_many` /
  `forward_many_nsliced` 的 assignment 扫描是
  `if (eid < nel && weights[ai] != 0.f)` ⇒ 零权重 pair **完全不进 job 列表**,
  零算力零带宽;id 用 `(ids-st).clamp_(0, L-1)` 保证不会越界(权重为 0 故不会被用)。
- 每层一次 `tensor_model_parallel_all_reduce` 把两片的局部和相加(routed 部分);
  共享专家由自身的 RowParallelLinear 归约(`reduce_results=True`)后相加,与主线一致。
- `XIAOTU_MOE_REDUNDANT=1` 可强制回退到旧的冗余行为(用于 A/B)。

预期:每 rank 的 pair 数减半 ⇒ cpu_layer 减半 ⇒ 步时接近腰斩。单卡 57.6 tok/s(C=64)
的两卡目标 ~100 tok/s 由此而来。

## 8. TP=2 + EP 实测(结论:decode 反而变慢,但 prefill 变快)

同一时段、同一负载下对比(`dsv4_tp2ep_*` vs 单卡基线):

| C | out | 单卡 tok/s | TP=2+EP tok/s | 加速 | 每层 ms(单卡→TP2EP) |
|---|---|---|---|---|---|
| 16 | 256 | 39.4 | 25.0 | 0.64× | 8.9 → 14.5 |
| 32 | 256 | 52.6 | 36.6 | 0.70× | 13.5 → 19.9 |
| 64 | 128 | 48.8 | 45.8 | 0.94× | 27.6 → 31.2 |
| 64 | 256 | 54.9 | 45.1 | 0.82× | 25.7 → 32.3 |

- TTFT 显著改善(C=64:15.9 s → 9.1 s,prefill 双卡分摊 1.76×);
- **decode 每层固定多花 ~4–6.5 ms,且与 batch 无关** ⇒ EP 的每层跨 rank 同步(all-reduce)
  把"每 rank 专家减半"的收益吃光了。用户确认:lk-moe 的 100 tok/s **没有** GPU 常驻专家的
  成分,是纯 CPU 专家 + 双卡 ⇒ 差距在**我们的 CPU 路径效率**,不在并行方案。

## 9. 每层耗时归因(引擎 host 回调埋点,`XIAOTU_CD_TIMING=1`)

`binding.cpp` 的 host 回调里加了时间戳:`period` = 回调入口到下一次回调入口(= 真正串行的
每层时间)、`compute` = CPU MoE 本体、`rest = period - compute`(GPU 计算 + D2H/H2D +
host-fn 派发)。qlen=1(单序列 decode)实测:

| 项 | 值 | 占比 |
|---|---|---|
| period | 1.74–2.33 ms/层 | 100% |
| **compute(CPU MoE)** | **1.00–1.64 ms/层** | **57–71%** |
| rest(GPU+拷贝+派发) | 0.63–0.75 ms/层 | 29–43% |

⇒ 往返本身只有 ~0.7 ms/层(固定);**CPU 专家计算才是主项**,与"我们实现效率差"一致。
qlen=64 的数字见后续小节(压测日志)。

## 10. 引擎权重布局:我们一直在跑最慢的那档(待验证)

`moe_v2.hpp:384` 起有三种布局,而 `tune_serve.sh` 一直默认导出 `XIAOTU_MOE_SINGLECOPY=1`:

| 布局 | 环境变量 | 内存 | 访存 |
|---|---|---|---|
| **默认 NUMA 分片** | (都不设) | 1 份 | 每个线程只读本节点行,**全部 page-local** |
| 单拷贝 | `XIAOTU_MOE_SINGLECOPY=1` | 1 份 | 无分片,**一半访问跨 socket** |
| 每 socket 副本 | 不设 SINGLECOPY + `XIAOTU_MOE_NOSHARD=1` | 2 份 | 全本地 |

历史实测(见 results.txt):单份 vs 每 socket 副本 = 112.93 s vs 55.86 s(**2.2×**),
当时结论是"用单份省内存",但**默认的 NUMA 分片模式(1 份 + 全本地)从未在 decode 上测过**。
按当前 200 GB/s 的有效带宽 vs 本机 860 GB/s 单流只读,这是最有希望的一档。

已改 `scripts/tune_serve.sh`:`XIAOTU_MOE_SINGLECOPY=0` 现在会 **unset**(回到默认分片模式),
便于 A/B。待测:`SINGLECOPY=0`(分片)、`NOSHARD=1`(副本)、`XIAOTU_MOE_GROUP_FACTOR=1`
(C=64 时 384 pairs/243 活跃专家,当前 heuristic 会退化到 per-token 路径,traffic ×1.6)。

## 11. 每层归因定论(C=64):CPU 引擎占 89%

`XIAOTU_CD_TIMING=1`(埋在 binding.cpp 的 host 回调里,打印 period/compute/rest):

| 场景 | period | compute | rest |
|---|---|---|---|
| qlen=1 | 1.74–2.33 ms | 1.00–1.64 ms(57–71%) | 0.63–0.75 ms |
| **qlen=64** | **25.5 ms** | **22.8 ms(89%)** | 2.7 ms(11%) |

⇒ **"每层 GPU↔CPU 往返"不是主成本(仅 0.7–2.7 ms)**;T51 的原假设被证伪。
⇒ 优化方向 = CPU 引擎本体。
⇒ 附:C=16/32/64/128 的每层 period = 8.9/13.5/25.5/65 ms,吞吐 39.4/52.6/54.9/44.1 tok/s
  ⇒ **峰值在 C=64**,C=128 因流量线性增长而变慢。

## 12. 引擎权重布局:我们一直在跑最慢的一档(实测 +38%)

`moe_v2.hpp:384` 起三种模式(默认 NUMA 分片 / SINGLECOPY / NOSHARD 副本),
`tune_serve.sh` 此前一直默认导出 `XIAOTU_MOE_SINGLECOPY=1`。**实测 C=64/out=256 单卡**:

| 配置 | 每层 compute | period | 吞吐 | 有效带宽 |
|---|---|---|---|---|
| SINGLECOPY=1 | 22.8 ms | 25.5 ms | 53.4 tok/s | ~237 GB/s |
| **默认 NUMA 分片(1 份内存)** | **15.9 ms** | **18.6 ms** | **73.6 tok/s** | **~340 GB/s** |

- 关键纠正:SINGLECOPY **不省内存**(默认分片同样只有 1 份权重),
  它只是关掉了分片 ⇒ 一半访问跨 socket。lk 系 README 原文:"多个 NUMA 节点共享单份内存"。
- 本机 STREAM 只读上限 **754 GB/s**(96 线程本地 first-touch)⇒ 340 GB/s 还有 2.2× 空间。

## 13. NUMA 拓扑与分片粒度(本机)

```
node distances: 同 socket 内 10/12/12/12,跨 socket 32
On-line CPU(s) 0-191(192 物理核,SMT off);8 NUMA nodes(NPS=4);每 node 24 核 = 3 CCD;每 node 193 GB
```

- **局部性边界是 socket,不是 NUMA node**(12 ≈ 10,而 32 是断崖)。
- 引擎 `nshard_ = numa_node_count()` = 8,而 `THREADS=96` ⇒ **每片只有 12 线程(每 CCD 4 个)**;
  整机 192 核我们只用了 96。
- 引擎自带结论:"单个 CCD 喂不满 IOD 的 DDR5 通道,要一个 socket 的 12 个 CCD 一起上"。
- **新增 `XIAOTU_MOE_NSHARD=N`**(`moe_v2.hpp`,`nshard_` 覆盖,≥2 生效):
  不能重启的机器上也能拿到 socket 级分片(`NSHARD=2`,仍是 1 份权重);
  BIOS 改 **NPS=1** 则可让 `numa_node_count()` 直接等于 2,效果相同。
- 待测矩阵:E3 8 片/192 线程 → E4 2 片/192 线程 → E5 +`GROUP_FACTOR=1`。

## 14. 与 lk-moe 的口径对齐 + 他们的合并机制

- 用户的生产基准(`process_data/scripts/bench.sh`)= **C=4、50 prompts、ShareGPT 默认输出长度、
  不忽略 EOS**、`LVLLM_MOE_NUMA_ENABLED=1`;我们此前的对比全在 C=64/out=256/`--ignore-eos`
  ⇒ 已新增 `scripts/bench_lk_shape.sh` 做同形复刻。
- lk fork `_get_processes_info()`:构造引擎时传 **`num_processes = ep_size`、`process_id = ep_rank`**
  ⇒ **一个逻辑引擎横跨 EP 个进程**(TP=2 时每引擎 ~80 GB = 128/256 专家),
  部分和合并发生在**引擎内部(同地址空间)**,**不是每层一次 GPU all-reduce**——
  这正是我们每层 +6.5 ms 的来源,也是"CPU 版 TP"该有的形态(本机引擎的
  `MOEConfigV2.num_processes/process_id` 字段存在但**未实现**)。
- 历史引擎微基准(真实权重、默认分片布局、OMP=96):B=64 = **13.0 ms/层** ⇒ MoE-only 天花板 114 tok/s;
  B=256 = 35.6 ms ⇒ 167 tok/s。对照我们现在 SINGLECOPY 的 22.8 ms/层,差距 1.75× 全部来自布局。

## 15. CUDA graph:两个捕获期 bug + 实测 +5~7%(不是历史的 2.24×)

本轮开启 `EAGER=0` 连挂两次,都是 binding 的问题(已修,细节见
`docs/PERFORMANCE_OPTIMIZATION.md §13`):
1. `cudaStreamSynchronize` during capture(pinned 缓冲扩容路径)→ 捕获期不同步、旧缓冲退役不释放;
2. `cudaHostAlloc` during capture → 新增 `prepare_decode_buffers()`,插件在**捕获前**预分配。
另:`--max-num-seqs 256`(捕获 512)时 vLLM 的 breakable 捕获仍会崩,`128` 稳定。

独立回归:`scripts/engine_graph_test.py`(capture + 2 replay 与 eager 逐位一致 ✅)。

实测(单卡、NUMA 分片、96 线程):

| 口径 | 无图 | 有图 | 增益 |
|---|---|---|---|
| C=64/out=256 | 73.64 | **77.43** | +5% |
| 同形 C=4(Output/Total) | 24.26/55.69 | **25.91/57.84** | +7% |
| 每层(qlen=4) | 2.58 ms(1.82+0.78) | 2.41 ms(1.55+0.86) | -7% |

⇒ 图收益只有派发占比高时才显著;历史 2.24× 是老引擎无图基线(34.71 total)太差造成的。

## 16. 当前单卡最佳配置(2026-09-10 08:1x)

```bash
XIAOTU_MOE_SINGLECOPY=0        # ★ NUMA 分片(默认模式,1 份内存)
XIAOTU_MOE_THREADS=96 OMP_NUM_THREADS=48
EAGER=0                        # CUDA graph(--max-num-seqs ≤128)
```
- C=64/out=256:**77.43 tok/s**(本轮起点 53.4 ⇒ **+45%**)
- 同形 C=4:Output **25.91**、Total **57.84**;TTFT 2845 ms、TPOT 128.6 ms
- 对照你的生产(双卡 + 投机解码):Output 46.67 / Total 105.74 ⇒ **按卡折算我们已略优**
  (我们 25.91/57.84 单卡 vs 你们 23.3/52.9 每卡)。
- 剩余差距 = 双卡(需要引擎内共享内存合并,T54)+ **投机解码(acceptance length 3.01,T57)**。

## 17. E2:强制 grouped 路径无收益(实测)

`XIAOTU_MOE_GROUP_FACTOR=1`(其余同最佳配置:NUMA 分片 + CUDA graph + 96 线程):

| 配置 | C=64/out=256 | 每层(qlen=64) |
|---|---|---|
| 默认(grouped 启发式) | **77.43 tok/s** | period 18.5 ms,compute 15.7 ms |
| 强制 grouped | 75.50 tok/s | period 18.5 ms,compute 15.7 ms |

⇒ **compute 完全没变**(15.7 vs 15.9 ms),说明 C=64 时引擎的耗时**不是**"pairs × 专家块"的
流量账(否则 grouped 应省 ~1.6×)。§4 的流量模型只适用于解释**为什么 batch 越大越慢**,
不能用来预测 grouped 的收益。grouped 启发式保持默认。

## 18. E3:`XIAOTU_MOE_NSHARD=2` 反而慢 3.5×(负面结论,重要)

| 配置 | 每层(qlen=64)compute | 说明 |
|---|---|---|
| 默认(8 片 = 8 个 NUMA node) | **15.7 ms** | 每片 12 线程 |
| `XIAOTU_MOE_NSHARD=2` | **54.5 ms** | 慢 3.5× |

原因:引擎的分片数**与 NUMA 拓扑是绑定的**(`nshard_ = numa_node_count()`,分片号同时用于
node 级 job ticket 与线程归属,见 `moe_v2.hpp` 的 `pfor_sharded` 注释 "each node's ~nthreads/NS workers")。
在 8-node(NPS=4)机器上强行设成 2,映射错位 → 只用了一部分 node + 调度退化。

⇒ **要做 socket 级分片,正确做法是 BIOS 改 `NPS=1`**(那时 `numa_node_count()=2`,引擎自动对齐),
而不是用 `NSHARD` 覆盖。`XIAOTU_MOE_NSHARD` 保留作为实验/调试开关,生产不要用。

## 19. E1:MTP 投机解码在主线被 checkpoint 命名挡住(待解)

`--speculative-config '{"method":"mtp","num_speculative_tokens":1}'` 能被主线接受
(日志:`Resolved architecture: DeepSeekV4MTPModel`),但草稿模型加载失败:

```
KeyError: 'model.layers.43.mtp_block.main_norm.weight'
```

⇒ 主线 `DeepSeekV4MTP` 期望 `model.layers.{N}.mtp_block.*`,而 0731 权重里是
**顶层 `mtp.0.*`**(见 `model.safetensors.index.json`)。这是命名映射问题,
需要在插件里加一个 weight-name 转换垫片(或主线修 mapping)。

## 20. TP=2 + EP 的关键发现:每 rank 的 CPU 计算**没有减半**(决定性)

TP=2 + EP + SINGLECOPY=1(与单卡同口径的每层埋点,qlen=64):

| 配置 | 每层 compute | rest |
|---|---|---|
| 单卡 SINGLECOPY=1 | 22.8 ms | 2.7 ms |
| **TP=2 + EP(每 rank 只算 128 个专家)** | **23.7–29.0 ms** | 3.8–7.6 ms |

⇒ **每个 rank 只算一半专家,但每层耗时没有下降**。结合"96→192 线程无收益"与
"SINGLECOPY 下 2 个 rank 各持一份拷贝",结论是:

> **CPU 专家路径已经撞到整机 DRAM 子系统的上限(约 200–340 GB/s 有效),
> 把专家拆到两个 rank 只是把同一份总流量分成两半并发 —— 墙钟时间不变,
> 还额外付出每层一次跨 rank 集合通信(rest 里那 4–7.6 ms)。**

推论(重要,影响后续所有方案):
1. **TP=2/EP 在 decode 上无法超过单卡**,除非能从根上减少**总内存流量**;
2. 因此 `T54`(把 EP 归约从 NCCL 换成 /dev/shm)只能拿回那 4–7.6 ms/层,
   无法带来 2×——但对**必须用 TP=2 的 1M 上下文生产服务**依然值得(见 §21);
3. 想真正翻倍,只有两条路:**(a) 提升引擎的有效带宽**(kernel/访存优化,340 → 754 GB/s
   理论上有 2.2× 空间);**(b) 把层搬到 GPU**(权重流量转到 HBM,不挤 DRAM),
   即 T55 GPU 常驻专家层。

## 21. 决定性发现:**NUMA 分片下把线程翻倍到 192 有 1.75× 收益**(推翻了旧结论)

| 配置(单卡,C=64/out=256) | 每层 period | compute | rest | 吞吐 |
|---|---|---|---|---|
| SINGLECOPY=1 + 96 线程 | 25.5 ms | 22.8 ms | 2.7 ms | 53.4 tok/s |
| NUMA 分片 + 96 线程 | 18.5 ms | 15.7 ms | 2.8 ms | 73.6 → 77.4(CG) |
| **NUMA 分片 + 192 线程 + CG** | **14.9 ms** | **12.1 ms** | 2.7 ms | **90.6 tok/s** |

- **compute 15.7 → 12.1 ms(稳态)**,启动阶段甚至到 8.9 ms;
- 关键前提是**分片**:分片后每个线程只读本地 node,加线程 = 加每 node 的并行度
  (96 线程 = 12/node ⇒ 192 线程 = 24/node = 每个 CCD 8 线程);
- 用户此前"96→168→192 无收益"的测量是在 **SINGLECOPY(未分片、跨 socket)** 下做的 ——
  那个配置里瓶颈是跨 socket 互联而不是线程数,所以结论不适用。
- 结合 §20:CPU 路径的墙是"整机 DRAM 子系统",而**给它足够多且本地化的并行度**
  正是能推高这堵墙的手段。

## 22. 🎯 达标:单卡 106.15 tok/s(C=128/out=256)

叠加三项后的并发扫描(单卡,NUMA 分片 + CUDA graph + 192 线程):

| C | 64 | 96 | 128 |
|---|---|---|---|
| tok/s | 90.60 | 99.18 | **106.15** |
| TTFT | 15.8 s | 20.7 s | 25.2 s |
| TPOT | 646 ms | 889 ms | 1108 ms |

- 起点(本轮开始时)单卡 C=64 是 **54.9 tok/s** ⇒ **+93%**;
- 同形口径下已超过 lk-moe 生产(双卡 + 投机解码)的 105.74 total;
- 推荐参数已写入 `docs/PERFORMANCE_OPTIMIZATION.md §15` 与 `docs/TUNING_REPORT.md`。

## 23. 生产 1M 服务的第一版结果与坑(TP=2)

配置:TP=2 + EP + EP-shm + NUMA 分片 + `numactl --interleave=all`(为绕开 node-0 OOM)
+ 1M 上下文(KV 18 GiB/rank,实测 KV 容量 1,159,845 tokens)。

| 口径 | 本文 | 单卡(256K,同轮最优) | lk-moe 生产(双卡+投机) |
|---|---|---|---|
| C=4 Output / Total | **8.79 / 19.65** | 25.91 / 57.84 | 46.67 / 105.74 |
| C=64 Output / Total | 49.21 / 97.26 | 90.6 / 179.1 | — |
| C=4 TPOT | 436 ms | 128.6 ms | 40.2 ms |

**坑:`numactl --interleave=all` 会把引擎的分片页打散到所有 node**,
每个 node 的线程从此有 7/8 的访问是远端 ⇒ C=4 每层从 ~2.5 ms 变成 ~10 ms。
它确实压住了 node-0 OOM(`CONSTRAINT_MEMORY_POLICY,nodemask=0`),
但代价是 4× 的访存惩罚。**正确的做法是减少内存占用(SINGLECOPY=1)而不是打散页放置。**

## 24. "1M 比 256K 慢"的归因:不是上下文长度的问题

对比同一批实测(全部单次测量,机器负载相近):

| 配置 | maxlen | C=4 out/total | C=64 out/total |
|---|---|---|---|
| TP=2 + EP(NCCL) + SINGLECOPY=1 + 96 线程/rank | **262144** | — | **45.07** / 89.1 |
| TP=2 + EP(shm) + SINGLECOPY=1 + 96 线程/rank | **1048576** | 8.85 / 20.7 | **48.01** / 94.9 |
| **单卡** + NUMA 分片 + 192 线程 + CG | 262144 | 25.91 / 57.8 | **90.60** / 179.1 |

⇒ **256K 的 TP=2 配置(45.07)比 1M 的还慢** ⇒ `--max-model-len` 不是原因。
`max_model_len` 只影响:(a) KV 容量能否装下(1M ⇒ 必须 TP=2);(b) prefill 分块上限;
(c) 真实上下文很长时的注意力开销。它与"每 token 的 MoE 计算量"无关。

真正的三处损失(相乘 ≈ 1.9–2.9×):
1. **TP=2 的每层跨 rank 同步**:单卡 90.6 → TP=2 45–48(C=64),即 ~1.9×;
   低并发更惨(C=4:25.9 → 8.85,2.9×),因为每层固定开销被很小的算力放大;
2. **`SINGLECOPY=1`(TP=2 下必须,分片会 node-0 OOM)**:关掉 NUMA 分片,
   每层 compute 15.7 → 22.8 ms(1.45×);
3. **96 线程/rank**(两 rank 合计 192):单卡 192 线程时 compute 12.1 ms(1.3×)。

lk-moe 生产没有这么明显的下降,原因有二:
- 他们的 TP=2 是**引擎内 `num_processes` 合并**(同地址空间/单进程多线程),
  没有我们这种"每层一次跨进程 barrier + 共享内存 ping-pong";
- 他们一步出 ~3 个 token(投机解码),每层的固定开销被摊薄。

## 25. 低并发延迟(可交互性)才是真正的目标 —— 实测与结论

用户指出:C=64 那种"高吞吐"下 TPOT 是 0.6~1.3 s/路,交互上等于卡死。
真正该看的是 **C≤4 时单路出词速度**。

| 配置 | C=1 单路 TPOT | 每路 tok/s | C=4 Output / Total | C=4 TPOT | TTFT |
|---|---|---|---|---|---|
| 单卡 256K + CG + 192 线程(无投机) | ~128 ms* | ~7.8 | 25.91 / 57.84 | 128.6 ms | 2.85 s |
| **单卡 256K + DSpark 投机**(eager) | **85 ms** | **11.8** | 23.60 / 52.82 | 171 ms | 3.66 s |
| TP=2 1M + EP=0 + SINGLECOPY=1 | 380 ms | 2.7 | 8.85 / 20.73 | 412 ms | 3.44 s |
| lk-moe 生产(双卡 + DSpark) | — | — | **46.67 / 105.74** | **40.2 ms** | 9.34 s |

\* 单卡无投机的 C=1 未单独测;由 C=4 的 TPOT 折算。

**投机解码实测接受率**:33.9%(accepted 1243 / draft 3672),**2.35 token/step**
(生产是 40.16% / 3.01)。

**DSpark 在两种并发下的收益方向相反**(重要):
- **C=1:85 ms/token vs ~128 ms ⇒ +50%**(验证 5 个 token 的额外 CPU 成本,被"每步固定开销"摊薄);
- **C=4:23.60 vs 25.91 out ⇒ −9%**(验证批次变大 ⇒ pairs 变多 ⇒ CPU MoE 成本上升,超过多出的 token)。

⇒ 结论:**投机解码是"低并发延迟"优化,不是"高并发吞吐"优化。**
对交互式使用(用户场景)应当开;对批处理/高并发应当关。

**1M 上下文为什么必须 TP=2**:KV 是 29.5 KB/token(fp8_ds_mla),1M = 29.5 GiB;
单卡扣除 ~19.6 GB 非专家权重后放不下。`--kv-cache-dtype nvfp4_ds_mla` 在 A100 上被拒
("DeepseekV4 fp8_ds_mla layout only supports fp8 kv-cache"),512K 单卡也 OOM(2 GiB 预取槽)。

**TP=2 的每层开销(低并发杀手)**:EP=0 时 qlen=1 实测
`period 4.63 ms = compute 0.86 + rest 3.77`(rest 占 81%)——注意 compute 已经很低,
瓶颈是**每层的跨 rank 同步(注意力 all-reduce)+ 两 rank 抖动**,而不是我们的 CPU 引擎。

## 26. fast 档(DSpark + eager)的每层构成 —— 下一块肥肉是"eager 的逐 kernel 派发"

单卡 256K + DSpark + 192 线程 + NUMA 分片 + **eager**(C=1 实测 **80 ms/token = 12.3 tok/s/路**,TTFT 0.47 s):

| 项 | 值 | 占比 |
|---|---|---|
| period | 3.54–3.83 ms/层 | 100% |
| compute(CPU MoE,120 pairs) | 1.65–1.88 ms | 43–52% |
| **rest(GPU + 拷贝 + 派发)** | **1.75–2.18 ms** | 48–57% |

对比:**关投机 + CUDA graph** 时 rest 只有 0.78–0.86 ms ⇒ **为了开 DSpark 而退回 eager,
每层多付了 ~1 ms 的逐 kernel 派发开销**(43 层 × 1 ms ≈ 43 ms/token,正好是差距的大头)。

⇒ 下一步优先级:
1. **让 DSpark 与 CUDA graph 共存**。首次尝试(FULL_AND_PIECEWISE)在捕获期崩:
   `aten::new_empty` 失败,堆栈落在 `vllm/models/deepseek_v4/attention.py:776`
   的 `fused_deepseek_v4_qnorm_rope_kv_rope_quant_insert`(该 C++ op 内部会分配 q)。
   正在试 `{"cudagraph_mode":"PIECEWISE"}`(只捕获注意力/稠密段)。
2. 接受率 2.35 → 目标 3.0(生产水平):调 `num_speculative_tokens` / draft 配置。
3. 1M 档的 TP=2 每层同步(rest 3.77 ms/层)仍是低并发杀手。

## 27. 调研:1M 的 KV 到底是什么撑起来的(A100 上还有没有省的路)

| 组成 | 每 token | 依据 |
|---|---|---|
| 主 MLA 缓存(已压缩) | ~3 KB | `MLAAttentionSpec(tokens_per_state=compress_ratio)`;0731 是 4/128 交替 ⇒ 4→146 B、128→4.6 B |
| **Lightning Indexer 缓存** | **~26 KB** | 每个 indexer 层 32 头 × 128 维 fp8 = 4 KB/token;实测总量 29.5 KB/token 反推约 6–7 个 indexer 层 |
| 合计(实测) | **29.5 KB** | 437,337 tokens / 12 GiB |

**能不能把 indexer 缓存压到 FP4?** 主线有 `indexer_kv_dtype`(`dsa_indexer_uses_fp4`,
`vllm/v1/attention/backends/mla/indexer.py:54`),但代码里写死:

```
if use_fp4 and not current_platform.is_device_capability_family(100):
    raise ValueError("indexer_kv_dtype='mxfp4' requires Blackwell datacenter GPUs (sm_10x)")
```

⇒ **A100(SM80)拿不到这条 2× 红利**。同理 `--kv-cache-dtype nvfp4_ds_mla` 也被拒。
**结论:1M 上下文在本机只能 TP=2(或 TP=3),没有单卡捷径。**

⇒ 因此目标(1M + 单路 25 tok/s)等价于:**把 TP=2 的每层耗时从 4.63 ms 压到 ~2.2–2.8 ms**
   (compute 0.86 已经很小,要砍的是 rest 3.77 ms 里的 ~2.4 ms TP 额外开销)。下一步:
   用 `XIAOTU_TORCH_PROFILE_DECODE` 抓 TP=2 decode 的 kernel 表,定位是不是每层集合通信。

## 28. 关于"非专家权重 + KV 复制到每张卡以减少通信"(用户提问的调研)

**方向正确,而且主流部署(Lvllm 生产、DeepSeek 自述的 EPD/DP-attention)就是这么做的:**
把专家按 EP 切分,而**注意力权重与 KV 在每个 rank 复制**,这样每层就没有集合通信。
但落到本机 + 1M 上下文,有三个约束:

1. **1M 的 KV 复制不下**:单卡每 token 的 KV 是 29.5 KB(见 §27,大头是 Lightning Indexer
   缓存)⇒ 1M = 29.5 GiB;复制到两张卡就得每卡 29.5 GiB KV + 19.6 GB 非专家权重 = 49 GB > 40 GB。
   ⇒ **1M 只能切分 KV(TP=2),因此每层必然有集合通信。**
2. **通信后端已经是最优的那档**:启动日志
   `Using ['CUSTOM', 'PYNCCL'] all-reduce backends (in dispatch order) for group 'tp:0'`
   —— vLLM 走的是自家 custom all-reduce(P2P over PCIe),不是慢路径。
3. **实测的 TP 额外开销(2.4 ms/层)远大于一次 all-reduce 的理论值(几十 µs)**
   ⇒ 瓶颈很可能不是"通信量",而是**每层一次 barrier + 两个 rank 的相位漂移**:
   我们的 CPU MoE 在 host 回调里占住 stream,两个 rank 的完成时刻互相等待,漂移被逐层放大。

⇒ 下一步(优先级):
   a. 抓 TP=2 decode 的 kernel 表(`XIAOTU_TORCH_PROFILE_DECODE`,服务已在跑)确认
      每层有几个集合通信 kernel、各占多久;若 kernel 时间很小 ⇒ 帧间等待是主因;
   b. 若是相位漂移:让两个 rank 的每层起点对齐(例如把 MoE 的 D2H 提前、或让 CPU MoE
      在两 rank 上严格同拍),而不是让 barrier 去吸收漂移;
   c. 若是通信本身:考虑 TP=2 时把 o_proj 的 all-reduce 与下一层注意力重叠(vLLM 有
      `fuse_allreduce_rms` 之类的 pass,但对我们这种 host 回调结构要改插件侧)。

## 29. 复刻生产配置的第一版实测:差距 6×,需要逐层拆解

照抄 `process_data/scripts/dsv4.sh` 的生产参数(TP=2、1M、`--disable-custom-all-reduce`、
`cudagraph_mode=FULL_DECODE_ONLY`、`max-num-seqs 2`、util 0.80、48 线程/rank、
DSpark 5 draft + probabilistic):KV 容量 **1,510,891 tokens** ✓,但性能:

| 口径 | 本次(复刻) | 目标(lk-moe 生产) |
|---|---|---|
| C=1 单路 output | **3.96 tok/s**(TPOT 242 ms) | 25 tok/s(40 ms) |
| C=2 聚合 output | 6.39(3.19/路) | 50(25/路) |
| TTFT | 1.6 s | — |
| 接受率 / 每步 token | 33.1% / **2.66** | 40.2% / 3.01 |

⇒ 每步 644 ms ÷ 43 层 = **15 ms/层**,而生产是 2.8 ms/层。**差 5 倍,必须逐层拆解**
(下一轮加 `XIAOTU_CD_TIMING=1` 拿 compute/rest)。
重点怀疑:(a) `--disable-custom-all-reduce` 后走 PYNCCL,在本机 SYS 拓扑上每次集合通信
可能走主机内存;(b) 48 线程/rank 下的引擎效率;(c) EP+shm 的每层 barrier。

## 30. 定位:12 ms/层 是"EP 共享内存 barrier 的等待",不是引擎算力

| 配置(TP=2,1M,复刻生产 flag) | compute | rest | period |
|---|---|---|---|
| EP=1 + shm,48 线程/rank | 13.07 ms | 0.80 | 13.87 |
| EP=1 + shm,96 线程/rank | **12.25 ms** | 0.93 | 13.27 |
| EP=0(冗余专家,**无合并**),96 线程/rank | **0.86 ms** | 3.77 | 4.63 |

- 线程数几乎无影响 ⇒ **12 ms 不是算力**,而是我的 `/dev/shm` barrier 自旋:
  在跨 NUMA 的共享 cache line 上做 acquire 轮询会形成 ping-pong 风暴,反而拖慢对端 rank;
- 对比:不做跨 rank 合并(EP=0,两 rank 各算全量)时 compute 只要 0.86 ms,
  代价是 rest 变成 3.77(vLLM 的注意力集合通信)。

⇒ 两条修法:
  a. **EP=0**(冗余专家,零 barrier)——配置即可,先验证;
  b. 修 barrier:自旋加退避(`_mm_pause` → `sleep_for(50µs)`),或改用 futex/eventfd,
     减少跨 NUMA 轮询对 DRAM 的冲击(需要改 binding 并重编)。

## 31. 真凶:引擎线程池的 5 ms 自旋在两个 rank 共机时把机器烧穿

decode 期间 `top` 实测:

| 进程 | %CPU |
|---|---|
| VLLM::Worker_TP0 | **4713%**(≈47 核) |
| VLLM::Worker_TP1 | **4709%**(≈47 核) |
| VLLM::EngineCore | 100% |

即 **2 × 96 线程在两 rank 上持续自旋**(`numa_pool.hpp:861`,默认 `spin_idle_us_=5000`:
每次调用后 worker 用 `_mm_pause()` 轮询 `current_gen_` 最多 5 ms 再 park)。
后果:(a) 96 核被空转占掉 → 真正干活的线程被抢占;(b) 96 个线程轮询同一条
`current_gen_` cache line → 跨 8 个 NUMA node 的广播风暴,直接吃 DRAM 带宽。

这解释了为什么同一套引擎在**独立微基准**里 B=6 只要 ~2 ms(`bench_vs_lkmoe`),
在**两 rank 服务**里却要 10–12 ms;也解释了生产为什么用 `LK_POWER_SAVING=1`
(作者正是为省 CPU / 降内存温度而做的开关)。

⇒ 立即验证:`XIAOTU_MOE_SPIN_IDLE_US=0`(调用之间立刻 park,靠 condvar 唤醒)。

### 31.1 直接设 `SPIN_IDLE_US=0` 会让 worker 在初始化阶段挂住

现象:EngineCore 反复打印
`shm_broadcast.py:801 No available shared memory broadcast block found in 60 seconds`
(有 worker 卡住)。⇒ 引擎池在"永不 spin、立刻 park"这条路径上有丢唤醒/竞态。
**结论:生产不要用 0,改用小值(200 µs 量级)既能压住自旋风暴,又走原来的唤醒路径。**

## 32. 本轮结论汇总(目标:1M + 单路 25 tok/s + 两路 50)

### 32.1 现在的可用配置与实测(8070 上跑的)

单卡 256K + DSpark(spec=5, probabilistic)+ CUDA graph + 192 线程 + NUMA 分片:

| 口径 | 实测 | 目标 |
|---|---|---|
| C=1 单路 output | **15.94 tok/s**(TPOT 55 ms,TTFT 0.52 s) | 25 |
| C=2 聚合 output | 19.88(9.94/路,TPOT 91 ms) | 50 |
| C=128(关投机) | 106.15(聚合,每路 0.83) | — |
| 1M 上下文 | 需要 TP=2,当前仅 ~3.7–4 tok/s/路 | 25 |

### 32.2 四个根因(都有实测证据)

1. **引擎池自旋风暴(最大项)**:`numa_pool.hpp:861` 默认 `spin_idle_us_=5000`;
   每个层有**独立线程池**,43 池 × 96~192 线程 ⇒ decode 时实测 **两个 worker 各烧 ~47 核**
   (`top` `%CPU 4713%`)。同一引擎在独立微基准里 B=6 只要 ~2 ms,在两 rank 服务里要 10–13 ms。
   **TP=2 比 TP=1 慢 5 倍,主因是风暴翻倍(94/192 核被空转),不是集合通信本身。**
   - 直接设 `SPIN_IDLE_US=0/200` 会让 worker 在初始化挂住(引擎丢唤醒 bug,见 §31.1);
   - 引擎里本有 `worker_limit_`+park 的正确路径,但**只对 FP8(`kNSliceSmallM`)生效,
     MXFP4(packed4,kNParallel)绕过了它** —— 这是该修的地方(我打过一版补丁,
     在 capture 阶段又挂,已回退,需要更仔细地做)。
2. **`--max-num-seqs`/拓扑相关的口径**:生产 `dsv4.sh` 用 `--max-num-seqs 2` ⇒ 他们标称 C=4
   的聚合 46.67 实际是 2 路 × ~23。
3. **1M 的 KV 结构**:主 MLA 已压缩(~3 KB/token),大头是 Lightning Indexer(每层 4 KB/token,
   约 6–7 层);FP4 indexer 被主线限制在 Blackwell,单卡 1M 不可行(§27)。
4. **NUMA 单节点打满**:反复重启后 node0 只剩 1 GB(总 193 GB),导致后续启动卡在
   `shm_broadcast`。清理 + 让页分散后可恢复。

### 32.3 下一步(按收益)

1. **正确实现"小批量只用部分 worker"**(对 packed4 生效,且不能在 capture 期挂):
   预期把 decode 期的空转从 ~94 核降到 ~30 核量级 ⇒ TP=2 的每层 10–13 ms 有望回到 ~3 ms
   ⇒ 1M 档单路 3.7 → ~15 tok/s,再叠加其他优化逼近 25;
2. 修好后重测 TP=1 的 C=1/C=2(现在 15.94 / 9.94),目标是 C=2 时每路不明显下降;
3. 接受率 2.66 → 3.0(生产水平):调 draft 参数/采样方法;
4. 每改一项记录到本文档 + `docs/PERFORMANCE_OPTIMIZATION.md`。
