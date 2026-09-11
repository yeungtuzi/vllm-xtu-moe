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

## 33. 本轮(fix 尝试)的结论:worker 子集这条路被引擎自身的竞态挡住

### 33.1 关键分辨实验:TP=2 + EP=1,**关掉 shm 合并**(回到 vLLM all-reduce)

| 配置(TP=2,1M,production flag,eager,96 线程/rank,qlen=6) | compute | rest | period | C=1 单路 |
|---|---|---|---|---|
| shm 合并开 | 12.25 ms | 0.93 | 13.27 | 3.96 |
| **shm 合并关** | **6.01–7.61 ms** | 2.93–4.53 | **10.44–10.54** | **4.22** |

⇒ shm barrier 值 ~5–6 ms/层(把 `period` 从 10.5 抬到 13.3);但**即便没有 barrier,
引擎本体在小批量下仍要 6–7.6 ms/18 pairs ≈ 340–420 µs/pair**,
而**独立微基准**(`bench_vs_lkmoe`,同一引擎同一形状)只有 ~55 µs/pair ⇒ **6–8× 的差距**。

### 33.2 池诊断证明不是"等 worker"

`XIAOTU_MOE_POOL_SLOW_MS=6` 输出:
```
[pool] SLOW parallel_for: elapsed=12ms n=32 counter=568 remaining=0 current_gen=4
  laggards=0/96 remaining=0
```
laggards=0、remaining=0 ⇒ **没有掉队线程,worker 确实在算** —— 即 96 个线程抢一条
ticket cache line、屏障尾部 + 2 个 rank 争核,把"小活"的成本放大了近一个数量级
(引擎注释原话:小批量下"屏障尾部比它并行的算术还贵")。

### 33.3 为什么没能用"worker 子集"修

- 引擎里正确的做法是 `small_batch_workers()` + `parallel_for_limited`;
  **但 packed4/kNParallel 路径绕过了它**(只有 FP8 的 `kNSliceSmallM` 分支用);
- 我按 FP8 的写法给 packed4 补上 wlimit 后,**两种跑法都挂**:
  warmup 阶段卡死、EngineCore 报 `shm_broadcast ... 60 seconds`;
- 读代码后确认根因:`small_batch_workers()` 在 DS-V4 维度上(macs 极大)恒返回 `nt`,
  于是传进去的是 **`wlimit == nt_`** 这个边界值,而 `parallel_for_limited` 的等待路径
  ("limited 且 remaining==n 时只 notify 一次")在这个边界上有竞态 ⇒ 死锁。
- **回退补丁(已重建 .so)**;要真正修得先修 `numa_pool` 的 limited 路径(附带单测),
  或在创建引擎时把池线程数降下来(但 48 线程实测无改善:13.07 vs 12.25)。

### 33.4 因此当前最优仍是单卡档;1M/TP=2 档需要先修引擎并发

8070 保持:**单卡 256K + DSpark + CUDA graph + 192 线程 + NUMA 分片**
= C=1 **15.94 tok/s**(TPOT 55 ms)、C=2 19.88。目标(25 / 50)尚差 1.6× / 2.5×。

## 34. worker 子集(严格 < nt)可用 + 单调步成本的量化

### 34.1 自旋死锁的真正机制(与 §33.3 互补)

读 `numa_pool.hpp` 的等待循环:caller **只在 limited 调用里** `cv_.notify_all()` 一次;
非 limited 调用**完全依赖 worker 自旋**来发现新任务 ⇒ `XIAOTU_MOE_SPIN_IDLE_US` 一旦小于
调用间隔就必然死锁。⇒ 要降自旋只能走 **limited 路径**(它有 notify),而不是调小自旋窗口。

### 34.2 补丁(已生效,TP=1/TP=2 都不挂)

`forward_many` 的 packed4 分支里,小批量(`M*k <= 4*nt`)时传 `wlimit = nt/4`,
并强制 `wlimit < nt`(避免上次 `limit==nt` 的边界死锁):

| 口径 | 改前 | 改后 |
|---|---|---|
| TP=2 每层 compute | 6.0–7.6 ms | **4.2–4.4 ms** |
| TP=1 单卡 C=1(端到端) | 15.94 tok/s | **15.95 tok/s**(无回归) |
| TP=1 每层 | 1.78 + 0.91 | 1.97 + 0.91(period 2.88–3.00) |

⇒ 引擎侧 compute 降了,但 rest 涨了,**单步总时间基本不变**(C=1 4.1 vs 4.22 tok/s)。

### 34.3 单调步成本的量化(这是下一步的依据)

| 口径 | qlen | period/层 | compute | rest | 每步 | 单路 |
|---|---|---|---|---|---|---|
| C=1(DSpark,accept 2.66) | 6 | **2.88–3.00 ms** | 1.97–2.12 | 0.91 | 149 ms | **15.95 tok/s** |
| C=2 | 12 | **4.44–4.69 ms** | 3.37–3.67 | 1.06 | 247 ms | 9.67(合计 19.34) |

目标(C=1 与 C=2 都要 ≈25/路):**每步必须稳定在 ~106–120 ms**(= 每层 ~2.5 ms),
而我们的每步从 149(C=1)涨到 247(C=2)。

**关键换算**:compute 与 pairs 近似线性(55 µs/pair @36 pairs → 47 µs/pair @72 pairs),
说明小批量下走的是 **per-token 路径**(每个 (token,expert) 对都读一次专家块),
而不是"每个活跃专家只读一次"的 grouped 路径(阈值 `nave*8 <= NASS` 在 qlen≤12 时判为 per-token)。
生产同口径是 2.8 ms/层 / 72 pairs ≈ 39 µs/pair ⇒ **每 pair 我们只慢 1.2×,
差距主要来自"每步 token 数/接受率/非 MoE 开销",而不是引擎内核本身。**

### 34.4 下一轮的三条线(按性价比)

1. **降每步的非 MoE 开销**:C=2 实测每步 247 ms,而 43 层 × 4.5 ms = 194 ms
   ⇒ **约 50 ms/步(20%)花在采样/logits/调度上**;早期 profile 里 `_topk_topp_kernel`
   单次 3.6 ms、每步 2 次就 7 ms,值得单独查。
2. **提接受率** 2.66 → 3.01(生产水平):调 draft 参数/采样方法,直接换 ~13% 单路速度。
3. **1M/TP=2**:仍受限于池的自旋/唤醒结构(§33),需要引擎侧认真改 + 单测。

### 34.5 试过但不行的:FlashInfer sampler

`VLLM_USE_FLASHINFER_SAMPLER=1` 直接起不来(与当初在 runbook 里关掉它一致)。
⇒ 每步那 ~50 ms 的非 MoE 开销暂不能从采样器换功能解决,得从别处查
(下一步:用 `XIAOTU_TORCH_PROFILE_DECODE` 在 *eager* 下抓一张 C=2 的 kernel 表,
看 sampling/logits/调度各占多少)。

---

## 35. 每 pair 成本的物理来源(权重流式带宽)+ draft 长度 k 的最优化

### 35.1 为什么成本 ∝ (token, expert) 对数 —— 代码级确认

`moe_v2.hpp:486`:packed4/MXFP4(`kNParallel`)分支**直接 return 到
`forward_many_nsliced`,完全绕过 §"expert grouping"**(那段 grouping 只在
BF16/FP8 的 legacy 路径里生效)。nsliced 内部虽然按专家把同一专家的多个
instance 收成连续行(有 me 路复用),但 DS-V4 的维度下 **qlen≤12 时
36–72 个 assignment 几乎落在互不相同的专家上(256 选 6)** ⇒ me≈1,
**每个 (row,expert) 对都要把那 12.6 MB 的专家块从 DRAM 流一遍**。

字节数(实测内存反推):引擎 TP=1 占 ~139 GB = 43 层 × 256 专家 × 12.6 MB;
每专家 = 25.2 M 参数 × 0.5 B(fp4)= 12.6 MB。
- qlen=6(1+k=6,C=1)⇒ 36 对 ⇒ **454 MB/层**,实测 compute 1.94–2.12 ms ⇒ **~234 GB/s**
- 边际:qlen 6→12 时 2.0→3.5 ms ⇒ **42–47 µs/pair ⇒ ~280–300 GB/s**

### 35.2 这个带宽离机器上限还差多少(单线程已测)

`scripts/bwprobe.c` / `/tmp/bw2`(顺序流式读、每 cache line 取 1 个 u64):
**单线程 35–36 GB/s**(16 GB 缓冲两趟一致,确认是 DRAM 而非缓存)。
⇒ 192 线程若线性叠加本应远超 234 GB/s;但集计上限未能测得可信值
(见 §35.4 的教训)。**结论暂记为:引擎已达到"每对读一次 12.6 MB"这一结构的
~234 GB/s,是否接近机器集计上限仍未定 ⇒ 内核还有多少空间未定论。**

### 35.3 逐位置接受率决定了 k 的最优值(实测)

服务端日志 `[metrics.py:120] SpecDecoding metrics` 每 10 s 打印:
```
Per-position acceptance rate: 0.667, 0.393, 0.179, 0.048, 0.036   (k=5, 较大样本)
Mean acceptance length: 2.32–2.66   (含 bonus token)
```
第 4/5 个 draft 的接受率只有 0.048/0.036,而每个 draft token 的代价是
qlen +1 ⇒ 每层 +6 对 ⇒ 43 层 × 6 × 42 µs ≈ **11 ms/步**。
用实测斜率(每层 base 1.08 ms + 每 qlen-token 0.308 ms,43 层,非层开销 S≈20–28 ms):

| k | 每步 ms | tok/步 | TPOT | 单路 tok/s(模型) |
|---|---|---|---|---|
| 1 | 93 | 1.67 | 55.7 | 17.9 |
| 2 | 106 | 2.06 | 51.5 | 19.4 |
| 3 | 119 | 2.24 | 53.3 | 18.7 |
| 4 | 133 | 2.29 | 58.0 | 17.2 |
| 5 | 146 | 2.32 | 62.8 | 15.9 |

⇒ **以我们当前引擎的边际成本,生产惯用的 k=5 并不是最优,k=2–3 才最优**;
生产的 39 µs/pair + 接受率 3.01 才让 k=5 划算。⇒ 引擎每快一点,最优 k 就变大一点,
两条线必须一起调。

### 35.4 教训(两次踩坑,都已写进流程)

1. **绝不在跑基准的同时跑重量级探针**:k=2 那组(C=1 6.39 tok/s / TPOT 127 ms、
   C=2 9.37 tok/s)是在我自己的 48 GB / 192 线程带宽探针**失控挂了 2 分钟**期间测的,
   **整组作废,必须重测**。轻量探针也只在服务"加载权重"阶段跑。
2. `pkill -9 -f "bw3 48"` 又一次**杀掉了自己所在的 shell**(§33 记过一次):
   匹配串必须写成不自匹配的形式(如 `"bw[3] "`)。
3. 机器负载终于安静下来(load 3,之前基线都在 **load 60–80** 下测的)
   ⇒ 所有旧基线偏悲观,需要在安静机器上重测一遍 C=1/C=2 基线。

### 35.5 本轮实验脚本

- `scripts/sweep_spec_k.sh`:对 k ∈ {2,3,5} 各起一次服务 + C=1/C=2 定长解码
  (IN_LEN=1024、OUT=200、`--ignore-eos`),并从服务端日志抓逐位置接受率到
  `report/tuning/logs/spec<k>.acceptance`。
- `scripts/bwprobe.c`:机器流式读带宽探针(仅供单线程/少量线程时使用)。

### 35.6 k 扫描实测结果(注意:该组用的是 random 数据集,**接受率被人为压低**)

| k | C=1 tok/s | C=2 合计/单路 | 逐位置接受率(位置0) | 平均接受长度 |
|---|---|---|---|---|
| 2 | (污染,作废) | (污染) | 0.33–0.51 | 1.35–1.77 |
| 3 | **5.82** | 7.87 / 3.94 | 0.23–0.70 | 1.34–2.32 |
| 5 | 5.34 | 7.55 / 3.78 | 0.22–0.67 | 1.33–2.29 |

`--dataset-name random`(随机 token)**把 draft 质量打到地板**:k=5 时位置0 只有
0.22–0.67(自然文本下是 0.67–0.85)、平均接受长度 1.33–2.29(自然文本 2.32–2.66)。
⇒ 随机 token 下"每步成本"主导,k 越小越快(k=2 > k=3 > k=5)。

## 36. k 的最优值由 draft 的训练块长决定(k=5 是对的,§35.3 的模型作废)

读 mainline 的 dspark 校验代码(`vllm/config/speculative.py:146`)与 DS-V4 的
`config.json`:`dspark_block_size: 5`、`dspark_noise_token_id: 128799`、
`num_nextn_predict_layers: 1`。DSpark/DFlash 是**并行 draft**(一次前向出一个
block 的 token,用 noise token 占位),draft 头是在 **block_size=5** 上训练的;
校验里对 Qwen3-Omni 直接要求 `num_speculative_tokens == block_size`。

这解释了 §35.6 里"k 越小位置0接受率越低"的反常现象(0.67 → 0.35 → 0.30):
**截断 block 会破坏 draft 的联合预测**,不是"少猜几个更容易猜中"。
⇒ **§35.3 那个"接受率与 k 无关"的假设是错的,按它推出的 k=2 最优不成立;
k=5(训练块长)才是正确选择。**
⇒ 教训:优化 spec decode 的 k 之前,先确认 draft 的训练块长 / 是否并行 draft。

## 37. 上下文长度与文本分布是必须量化的混淆项(测量方法已补齐)

旧基线(C=1 16–17 tok/s)用的是 sharegpt 的**短 prompt**:实测 total_input_tokens
只有 64/3 = 21 token/条(见 `report/tuning/raw/grp_c1.json`)。
而扫描用的 1024 token 输入只有 5.3–6.4 tok/s。二者差 2.5–3×,里面混了两个变量:
上下文长度、以及文本分布(随机 token vs 自然文本 ⇒ 接受率 1.3 vs 2.3)。
⇒ 为得到能代表目标场景的数字,新增:
- `scripts/make_nat_dataset.py`:从 ShareGPT 拼出**精确 token 长度**的自然文本数据集
  `report/tuning/datasets/nat{32,64,128,512,1024,4096}.jsonl`(实测首条 = 目标长度);
- `scripts/bench_nat_client.py`:自建客户端(不依赖 pandas),
  带 `stream_options.include_usage`,同时给出 **每步延迟** 与 **tokens/步**。
- 实测结论(§38.4):**每层 period 在 22→4096 token 六档上都是 4.1–4.7 ms
  ⇒ 上下文长度对解码步时间没有影响**,先前 2.5–3× 的差异全部来自
  随机 token 的接受率崩塌 + GPU 时钟状态,不是上下文。

## 38. 本轮最重要的结论:瓶颈在**机器的实际内存带宽**(不是内核)

> ⚠️ **本节 38.1–38.2 的结论随后被 §39 推翻**:当时的带宽探针把所有物理页都落在
> 一个 NUMA 节点上(主线程首次触碰),测到的 95 GB/s 是**单节点**上限;
> 正确做法是每节点绑定本地内存 + 本地 CPU,实测**整机 783 GB/s**。
> 引擎实际只用到 ~7% 的节点带宽 ⇒ **内核有极大空间**,并非无路可走。
> 38.3–38.6(GPU 降频、上下文无关、达标算术)仍然成立。

### 38.1 机器实测带宽上限(三种方法一致)

| 口径 | 结果 |
|---|---|
| 单线程顺序流式读(16 GB,两趟一致) | **35–36 GB/s** |
| 24 线程(每线程私有 1.3 GB 切片) | **97 GB/s**(≈4 GB/s/线程) |
| 96 线程 | 81 GB/s |
| 192 线程(整机) | 94–97 GB/s(≈0.5 GB/s/线程) |
| **8 个独立单线程进程并发(各 6 GB,不同 CCD)** | 每个 11.8–16.1 GB/s,**合计 103 GB/s** |
| 历史报告 `process_data/decomp/NUMA_BANDWIDTH_CCD.md`(8 cores/CCD 起测) | 1 CCD 30 GB/s → 24 CCD **73.7 GB/s** |

本机 8 节点(NPS=4)、1.5 TiB(24×64 GB DDR5-4800),理论峰值 ~920 GB/s,
但**实测集计读带宽只有 ~95–105 GB/s(约 10%)**,且 3 个线程就到了平台期。
**"8 个独立进程并发"这一路排除了"多线程探针自身有缺陷"的可能**(8×11.8–16.1 = 103 GB/s,
而不是 8×35 = 280)。宿主没有 resctrl/MBA 限流可读(容器内看不到),CFS 也无节流
(`nr_throttled=0`)⇒ 只能按"这台机器当前能给 ~100 GB/s"来做工程决策。
⇒ 这是**硬上限**,任何 CPU 端内核优化都不可能突破它。**这也是本项目最该上报给运维的事**:
如果内存带宽能恢复到硬件应有水平,MoE 的 86 ms/步会掉到 ~20 ms,目标立刻可达。

### 38.2 引擎已经贴着这个上限

- 引擎每层要读的专家权重 = **去重后的活跃专家数 × 12.6 MB**(fp4,25.2 M 参数/专家)。
- 真实路由下每层约 2.0 ms;随机路由(36 个互不相同专家 = 454 MB)下
  `scripts/bench_cpu_engine.py` 实测 5.46–8.06 ms/层 ⇒ **56–83 GB/s**。
- 按 NUMA 分片,每节点每层约 19 MB,24 线程读出 9.5 GB/s,而 24 线程的探针上限
  只有 ~12 GB/s ⇒ **引擎已达节点带宽的 ~80%**。
- 结论:**小批量 MoE 的成本是"必须读的字节数 / 机器带宽",继续抠内核最多再拿 15%。**

### 38.3 每步成本的实测拆解(C=1、k=5、qlen=6、自然文本)

| 项 | 数值 | 说明 |
|---|---|---|
| 每层 `compute`(MoE 回调:D2H+引擎+H2D) | 2.0–2.7 ms | ×43 = **86–116 ms/步** |
| 每层 `rest`(GPU 注意力/dense + 主机 Python) | 0.91 ms(早先) → **2.1–3.1 ms(现在)** | ×43 = 39 → 90–133 ms/步 |
| 非层开销(采样/调度/反序列化) | ~25 ms/步 | |
| **合计每步** | **~200–215 ms** | 客户端实测(修正后的客户端) |
| tokens/步 | 2.5–2.8 | |
| 单路 | **12 tok/s**(最好一次 11.97/13.9) | 目标 25 |

### 38.4 `rest` 为什么从 0.91 涨到 2.1–3.1 ms:GPU 降频(已证实)

- `nvidia-smi` 全程显示我们用的 GPU2:**SM 765 MHz / 最大 1410 MHz,利用率 14–21%,
  功耗 45 W / 250 W**。因为解码是 CPU 端 MoE 主导(1/3 时间 GPU 空转),
  驱动一直不给上频。
- 想锁频:`nvidia-smi -i 2 -lgc 1410` → **当前用户无权限**(需要 root)。
- 同样的二进制、同样的配置、同样的 qlen=6,早先 `rest`=0.91 ms(那时 GPU 更忙、
  时钟更高),现在 2.1–3.1 ms ⇒ 差的就是 GPU 时钟。
- 对照:上下文长度 22/64/128/512/1024/4096 token 六档,**每层 period 都是 4.1–4.7 ms**
  ⇒ 注意力开销与上下文长度无关(1M 目标不需要为"短上下文的假基线"买单)。

### 38.5 客户端测量踩的坑(已修)

自研客户端最初把 **SSE chunk 当 token** 计数:vLLM 在投机解码下**每步只发一个 chunk**,
于是一路吞吐被低估 (1+接受长度) 倍(3.5 tok/s vs 真实 8.8)。
修法:请求里带 `stream_options={"include_usage": true}`,token 数取 `usage.completion_tokens`;
chunk 数 = **步数**,顺便直接量出"每步延迟"和"tokens/步"(与引擎侧 `period` 交叉验证一致:
43×4.5 ms ≈ 200 ms ≈ 客户端 step 211 ms ✓)。

### 38.6 达标的算术(给下一轮定方向)

- 目标 25 tok/s/路、2.8 token/步 ⇒ **每步必须 ≤ 105 ms**。
- 下限:MoE 68–86 ms(6.5 GB/步 ÷ 95 GB/s)+ 注意力 39 ms(满频)~90 ms(当前频率)+ 采样 25 ms
  ⇒ **130–200 ms**。
- ⇒ 当前机器条件下**做不到 25 tok/s/路**;能动的只有三块:
  1. **GPU 上频**(需要 root:锁 SM 时钟或用别的方式提高利用率)⇒ 直接省 40–50 ms/步;
  2. 减少每步 MoE 字节(只能靠减少 token/步 = 改接受率,draft 块长固定 5 ⇒ 空间很小);
  3. 砍非层开销 25 ms(采样 3.6 ms×2、logits、调度)。
- 反过来:**如果机器内存带宽能恢复到正常水平(而不是 95 GB/s)**,MoE 从 86 ms 掉到
  ~20 ms,立刻达标。⇒ 值得先确认这台机器(或这批租户)是否存在内存带宽被抢占/BIOS 配置问题。

### 38.7 本轮脚本与产物

- `scripts/bench_nat_client.py`:目标场景客户端(自然文本数据 + usage 计 token + 每步延迟)。
- `scripts/make_nat_dataset.py` / `report/tuning/datasets/nat{32,64,128,512,1024,4096}.jsonl`。
- `scripts/bwprobe.c`:机器带宽探针(单线程/少线程时用,勿与基准并行跑)。
- 结果在 `report/tuning/summary.jsonl`(`natural_text=1` 的行)。


旧基线(C=1 16–17 tok/s)用的是 sharegpt 的**短 prompt**:实测 total_input_tokens
只有 64/3=21 token/条(见 §35.6 的表和 `report/tuning/raw/grp_c1.json`)。
而扫描用的 1024 token 输入给出 5.3–6.4 tok/s。二者差 2.5–3×,里面**混了两个变量**:
1. 上下文长度(注意力/indexer 的代价随上下文增长);
2. 文本分布(随机 token vs 自然文本 ⇒ 接受率 1.3 vs 2.3)。

⇒ 为了得到能代表目标场景的数字,新增:
- `scripts/make_nat_dataset.py`:从 ShareGPT 拼出**精确 token 长度**的自然文本数据集
  `report/tuning/datasets/nat{128,512,1024,4096}.jsonl`(实测首条 = 目标长度)。
- `scripts/bench_nat.sh` / `scripts/run_nat_curve.sh`:在单卡 256K + k=5 + CUDA graph
  的已知好配置上,跑 `上下文 × 并发` 曲线(带 `XIAOTU_CD_TIMING=1` 每层计时),
  结果进 `report/tuning/summary.jsonl`(带 `natural_text=1` 标记)。


---

## 39. 更正 §38 + 拿到第一个真正的内核加速:me=3 的 2/3 行分块(1.7×)

### 39.1 更正:整机带宽是 783 GB/s,不是 95 GB/s

错在哪:探针用一个 `aligned_alloc` 的缓冲(主线程首次触碰)⇒ **所有页都在一个 NUMA
节点上**,192 个线程跨节点去读同一份内存,量到的是"单节点 + 跨 socket 读"的混合值。

正确测法(`numactl --cpunodebind=N --membind=N`,每节点独立进程 + 本地内存):

| 口径 | 结果 |
|---|---|
| 单节点 1 线程 | 36.7 GB/s |
| 单节点 8 线程 | 90.7 GB/s |
| 单节点 24 线程 | **98.7 GB/s**(3 通道 DDR5-4800 理论 ~115 ⇒ 86% 效率,正常) |
| **8 节点 × 24 线程(整机)** | **783.0 GB/s**(8×98 = 784,完美线性) |
| (旧的错误口径:单块缓冲 + 192 线程) | 94–103 GB/s ← 单节点上限 |

⇒ 机器没有任何异常,是我测错了。**引擎每层 151 MB / 1.17–2.0 ms = 75–130 GB/s
= 每节点 9–16 GB/s,只有节点上限(99 GB/s)的 10–16%** ⇒ 内核离硬件上限还很远。

### 39.2 根因:真实解码的 me=3 落在"4 行分块"快路径之外

- `bench_cpu_engine.py` 原来用**全随机路由**(36 个互不相同的专家,me=1),测不到
  真实情形。真实解码步里 6 个 draft token 属于同一段文本,**去重后只有 ~12 个专家,
  me≈3**(用引擎自带 `XIAOTU_MOE_PROFILE` 实测:`na=6..12`,skew 桶 `2-7` = 12 个专家)。
- `gate_up_slice_batch_impl`/`down_slice_batch_impl` 把 me 直接传给
  `matmul_packed4_group(..., M=me, ...)`;该内核只有 **M≥4 的"解码一次喂 4 行"**快路径,
  M=1..3 落到单行兜底 ⇒ **每一行都把权重 nibble 解码重做一遍**。
- 判据(同一批 12 个专家 = 同样 151 MB 权重):

| 情形 | 走的分支 | ms/层 | µs/assignment |
|---|---|---|---|
| me=4 | 4 行分块 | 1.50 | **31.2** |
| me=3 | 单行兜底(旧) | 2.00 | **55.6** |

⇒ 每 assignment 白烧 **1.78×** 的解码算力,而真实解码恰好一直是 me=3。

### 39.3 修复:补 2 行 / 3 行分块(`moe_v2_packed4.hpp`,FAST_FP4 路径)

4 行分块之后、单行兜底之前插入 `block_23<R>`(模板 + `std::integral_constant`):
**解码一次喂 2 或 3 行**,每行仍是 4 个部分累加器(与 4 行分块**完全相同的累加结构**,
所以每行内部数值语义不变)。M=5/6/7 自然变成 4+1 / 4+2 / 4+3。

实测(BS=6, DEDUP=12, REP=79, REP 内 40 次调用的阶段累计):

| 阶段 | 改前 | 改后(两次) | 加速 |
|---|---|---|---|
| A 门/上投影 | 48.8 ms | 25.3 / 26.5 ms | **1.9×** |
| B 下投影 | 27.4 ms | 17.6 / 18.0 ms | **1.55×** |
| C 加权归约 | 3.7 ms | 3.5 / 3.8 ms | 1.0× |
| **每层合计** | **2.00 ms** | **1.17 / 1.20 ms** | **1.7×** |

### 39.4 数值正确性(新增 `scripts/test_block23_equiv.py`)

用真实 MXFP4 权重 fixture + numpy golden,**受控路由**逐 case 对拍:

| case | me 分布 | max_abs | max_rel(|g|>0.05) |
|---|---|---|---|
| me=1(未改动路径) | 全 1 | 4.4e-3 | 1.9e-2 ⚠️(既有差异,M=1 不进新代码) |
| me=2 | 全 2 | 1.2e-4 | 3.9e-4 ✅ |
| me=3 | 全 3 | 1.2e-4 | 3.7e-4 ✅ |
| me=2/3 混合 | 2,3 | 7.6e-5 | 2.1e-4 ✅ |
| me=4 / 5 / 6 / 7 | — | ≤1.8e-4 | ≤5.6e-4 ✅ |

另:`scripts/test_swiglu_clamp_mxfp4.py`(M=8、16 专家随机路由)也全过。

### 39.5 工具与方法学

- `scripts/bench_cpu_engine.py` 新增 **`DEDUP=N`**(去重后的活跃专家数),
  这是让小批量引擎基准有代表性的关键旋钮;**不设 DEDUP 的旧数字全部偏悲观**。
- `XIAOTU_MOE_PROFILE=1` 对 packed4/nsliced 路径**是有效的**(`prof_add` 在
  `forward_many_nsliced` 末尾),但每 40 次调用才打印一次 —— REP 要 ≥40 才看得到。
- 基准噪声极大(同一配置 2.4 / 10.1 / 7.4 ms 都出现过)⇒ 至少两次独立复现再下结论。
- 构建:`PYTHON=<venv> PYBIND11_INC=<torch>/include scripts/build_engine_variants.sh`
  (环境里没装 pybind11,用 torch 自带的头文件目录即可)。构建会多出一个
  `_avx512_bf16` 变体,而 loader 的优先级最高是它 —— 做 A/B 时要先把它移走,
  否则 ISA 变了会污染对比。

### 39.6 第二处修复:单行路径的 4 路独立累加(ILP)

服务内实测:一次解码调用的 36 个 assignment 落在 **~32 个不同专家**上
(`skew(1|2-7)=28|4`)⇒ **真实 me≈1.1**,单行路径才是解码热路径。
而单行路径原来是**一条 128 长的串行 FMA 依赖链**(`total0 = fmadd(d,sv,total0)`
×128 ≈ 512 cycle/行),OoO 无法掩盖。改成 4 个独立部分累加器后:

- 交错 A/B(DEDUP=0 ⇒ na=16、skew 29|3,与线上同形):旧 **87.6 ms** → 新 **63.0 ms**
  (每 40 次调用的 A+B 累计)⇒ **1.39×**;
- DEDUP=12(me=3):**1.59×**(见 39.3);
- **顺带修好了一个数值问题**:`scripts/test_block23_equiv.py` 里 me=1 那一档原先
  max_rel=**1.9e-2**(当时误判成"golden 偏差"),改后 **3.0e-4** —— 说明旧的串行链
  本身误差就大。现在 8 个 case 全部 ✅。

### 39.7 本轮结论

| 口径 | 旧内核 | 新内核 | 加速 |
|---|---|---|---|
| 微基准 me≈1(与线上同形) | 87.6 ms/40 calls | 63.0 ms | **1.39×** |
| 微基准 me=3 | 69.1 ms | 43.4 ms | **1.59×** |
| 每层 MoE(推算,me≈1) | ~2.2 ms | ~1.6 ms | 1.39× |

仍待办:
1. **服务端端到端复核**(本轮末尾在做:负载 90–124 时的 7.2–9.0 tok/s 与基线
   11.55(负载 ~40)不可比,必须同窗口对比);
2. 真实调用里还有大量 **M=1~2 的小调用**(`XIAOTU_MOE_PROFILE` 窗口平均 M=2、
   na=11,怀疑 dspark draft 的 MoE 层也走同一引擎)——需要按调用类型分开
   profile,否则平均值误导(本轮就被误导过一次);
3. `rest`(注意力/dense,2.1–4.0 ms/层)已是剩下的大头,与 GPU 765 MHz 降频绑定。

## 40. 端到端 A-B-A 复核(同窗口换二进制重启)

`scripts/ab_serve_kernel.sh`,单卡 256K + DSpark k=5 + CUDA graph + 192 线程:

| 段 | 负载 | 单路 tok/s | 每步 ms | 每层 compute | 每层 rest | 每层 period |
|---|---|---|---|---|---|---|
| old(基线内核) | 72.8 | 6.72 | 344 | 3.57–3.90 | 3.82–4.16 | 7.43–8.06 |
| new(block_23 + ILP) | 65.0 | **8.34** | 276 | **2.45–2.64** | 2.31–2.69 | 4.76–5.33 |

- **引擎项(compute)3.7 → 2.55 ms/层 = 1.45×**,与微基准交错 A/B 的 1.39×(me≈1)
  和 1.59×(me=3)一致 ⇒ 内核修复确实生效。
- 端到端 tok/s +24%,但**不能全记在内核上**:new 那一段负载低 8 个点,`rest`
  (与内核无关)也一起从 4.0 掉到 2.5 ms ⇒ 有一部分是机器变闲带来的。
- `rest` 现在与 `compute` 等量齐观(各 ~50%),是下一轮的主战场(§38.4:GPU 765 MHz)。

### 40.1 本轮结束时的官方数字(新内核,负载 ~71)

| 配置 | 单路 tok/s | 每步 ms | tokens/步 | 接受长度 | 每层 compute / rest |
|---|---|---|---|---|---|
| C=1 ctx128 | **9.15** | 270 | 2.818 | 2.86–3.64 | 2.46 / 2.65 ms |
| C=2 ctx128 | 5.96(合计 11.92) | 433 | 3.004 | ~3.0 | — |

- 同负载下旧内核 6.72 tok/s ⇒ **新内核 +36%**;
- 接受率依旧达标(2.86–3.64 ≥ 生产 3.01);
- 机器空闲负载(~40)时按同样的 compute/rest 推算:C=1 约 **15–16 tok/s**
  (compute 1.5×43=65 ms + rest 2.1×43=90 ms + 非层 ~25 ms ≈ 180 ms/步)。
- **`rest` 已占每步 ~50%,是下一轮的主战场**(GPU 765/1410 MHz、注意力/dense);
  引擎侧仍有空间(节点带宽只用掉 10–16%),但边际收益已不如 `rest`。

---

## 41. 第二个大杠杆:引擎线程池的 5 ms 自旋把整机烧穿(rest 3.3 → 0.95 ms/层)

### 41.1 现象:解码期间进程占 166–259 核,而真正的 MoE 算力只需 ~21 核

按 /proc 逐线程统计(解码中,10 s 窗口):**193 个线程活跃,合计 166–259 核**
(机器一共 192 核);空闲 30 s 后完全停泊(0 核)。
而 MoE 的实际工作量是:`compute ≈ 2.5–3 ms` / `period ≈ 4–6 ms`,只有 48 个 worker
参与(limited 路径)——即真正的算力需求约 **21 核**。⇒ **约 75% 的 CPU 是自旋浪费**。

原因:`numa_pool.hpp` 的 worker 在两次调用之间会自旋 `XIAOTU_MOE_SPIN_IDLE_US`(默认
**5000 µs**)等下一次任务,而解码步里相邻两次调用只隔 ~2–4 ms ⇒ 自旋窗口永远不到期,
192 个 worker 在整个解码期间全速空转。它们既浪费机器,又**抢走驱动 GPU 的主线程**,
于是每层 `rest`(GPU 注意力/dense + 主机侧)被推高到 3.3–3.5 ms。

### 41.2 修复:自旋窗口 5000 → 300 µs(已写进插件默认)

`vllm_xiaotu_moe/hybrid_model.py::finalize_moe_weights` 在建引擎之前
`os.environ.setdefault("XIAOTU_MOE_SPIN_IDLE_US", "300")`(用户仍可用环境变量覆盖)。
不会死锁:自旋超时后 caller 在 limited 与非 limited 两条路径上都会 `cv_.notify_all()`
唤醒(`numa_pool.hpp::parallel_for` 的 fallback),已实测解码/预填充都正常。

### 41.3 实测(同程序列,括号法;单位 ms/层)

| spin | 负载 | C=1 tok/s | period | compute | **rest** |
|---|---|---|---|---|---|
| 5000(旧默认) | 71 / 100 | 9.15 / 7.53 | 4.76–7.12 | 2.45–3.65 | 2.31–3.83 |
| 1000 | 56.9 | 10.56 | 4.10–4.64 | 2.85–3.25 | 1.25–1.39 |
| 100 | 60.7 | 10.14 | 3.81–3.95 | 2.88–2.97 | 0.93–0.98 |
| **300(新默认)** | 93.3 / 65.6 | **12.04 / 11.72** | 3.78–4.37 | 2.84–3.40 | **0.94–0.98** |

- **`rest` 降 3.5×**(3.3–3.5 → 0.94–0.98 ms/层),`compute` 基本不变;
- 端到端 **+28%~60%**(同负载下 9.15 → 11.7–12.0 tok/s;负载 93 时也有 12.04);
- 100 与 300 每层等价(留 300 作为对"调用内部阶段间隔"的余量)。

### 41.4 新的成本结构(C=1、qlen=6、spin=300)

| 项 | ms/层 | ms/步(×43) | 占比 |
|---|---|---|---|
| compute(CPU MoE,回调体 = 纯 `forward_many`) | 2.84–3.40 | 122–146 | **~75%** |
| rest(注意力/dense + 主机侧) | 0.94–0.98 | 40–42 | ~22% |
| 非层开销(采样/调度) | — | 15–30 | ~8% |
| **合计每步** | | **~200 ms** | 2.97 token/步 ⇒ 15 tok/s |

⇒ `rest` 这块肥肉已经吃掉;**下一轮的主战场变回 `compute`(CPU MoE 引擎本身)**。
目标 25 tok/s 需要每步 ≤105 ms,即 compute ≤ ~1.0 ms/层 —— 而**微基准在同形路由下
只要 1.58 ms/层(A+B),服务内却是 2.84–3.40 ms**,两者差 1.3–1.8 ms 需要定位
(候选:服务内 worker 逐层 park/wake 的代价、真实路由比合成路由更分散、其他租户的访存争抢)。

### 41.5 微基准 vs 服务内的差额复核(部分归因于机器争抢,未完全解释)

同一形路由(na=16、skew 29|3、B=6/DEDUP=0、192 线程):

| 测量时刻负载 | 每层 A+B | C 阶段 | 说明 |
|---|---|---|---|
| 27–43(交错 A/B 窗口) | **1.58 ms** | 0.09 | 服务内同时刻为 2.84–3.40 |
| 18.9(本次复测) | 1.81 / 1.90 ms | 0.09 / **0.48** | run2 的 B/C 明显被扰 |

⇒ ①微基准与服务内仍有 **~1.0–1.5 ms/层** 的差额待定位;
②**同一配置的微基准在不同时刻也能差 2×**(C 阶段 3.7 → 19.3 ms 都出现过),
说明引擎是访存受限,而**负载均值反映不出其他租户的内存带宽争抢**;
③因此"服务内 compute 2.8–3.4 ms"里有多少是引擎结构问题、有多少是机器争抢,
需要更硬的证据(建议下一轮:在 compute 回调内加 `XIAOTU_MOE_PROFILE` 的
A/B/C 阶段计时,与 CD 的 compute 直接对齐;或在机器真正安静时(load<5)复测)。

---

## 42. 引擎调用内部的阶段拆解(新增 `XIAOTU_MOE_PROFILE` 分桶))与第三处优化

### 42.1 新增按调用规模分桶的阶段计时(把 draft 小调用与主调用分开)

`moe_v2.hpp::prof_add` 现在按 M 分三桶(M≤2 / 3–8 / >8)分别累计
`setup/A/B/C/ovh` 并每 200 次调用打一行 `[NS-PROF]`。实测(M=6/na=32/DEDUP=0、
192 线程、spin=300)单次引擎调用:

| 版本 | setup | A 门/上 | B 下 | C 归约 | 合计 |
|---|---|---|---|---|---|
| 真解码(修好 scale 查表后) | 246 | 1076 | 1044 | 492 | **2858 µs** |
| **诊断构建:把解码换成平凡实现(结果错,只测时间)** | 266 | **746** | **475** | 128 | **1615 µs** |

⇒ **解码占 43%**;而"内存 + FMA 循环"的下限仍有 1615 µs(只到节点带宽的 31%),
说明内核是**指令数/发射受限**,不是 DRAM 受限。这给下一轮定了方向:
用 AVX512-BF16 的 `vdpbf16ps`(一条指令 32 个 MAC,且激活本来就是 bf16、不必转 fp32)
重写解码+FMA,理论上把每个 32 值组的指令数从 ~20+5M 降到 ~8+2M。

### 42.2 第三处优化:去掉内层每 group 的整数除法(1.13×)

FAST_FP4 分支里 `gk == 32` 恒成立 ⇒ `kbase/gk == g`、`(K+gk-1)/gk == K/32` 都与
g 无关,只有 `(n/gn)` 是每行一次。原来的 `scale_at()` 在**每行每个 group** 都做
两次整数除法(Zen4 上 div ~20-40 cycle),而内层是 128 group/行,单次调用上万次除法。

改成:每行算一次 `srow = (j/gn)*kb_stride`,内层只做 `Sbytes[srow+g]` 一次取值。
交错 A/B(负载 1.2–1.4):

| 内核 | setup | A | B | C | 合计 |
|---|---|---|---|---|---|
| 旧(每 group 两次除法) | 244 | 1303 | 1252 | 437 | 3236 µs |
| **新(行级索引)** | 246 | 1076 | 1044 | 492 | **2858 µs** |

⇒ **1.13×**;数值对拍(`test_block23_equiv.py` 8/8、`test_swiglu_clamp_mxfp4.py`)通过。

### 42.3 试过但回退的:C 阶段分块 + 向量化(未证明收益)

把 C 阶段从"每 token 一个 job"改成"(token × hidden 分块)"并向量化:理论上
M=6 时参与 worker 从 6 个升到 48 个。但交错 A/B 的**最小值统计**显示新版本在
A/B/C 三个阶段同时偏慢(说明该轮次测量顺序有系统偏差,前后条件不可比),
C 阶段本身在**同一内核**的不同轮次里也在 105–786 µs 之间跳 ⇒ **该阶段受
"每次池调用的固定开销(唤醒+屏障 ≈100–300 µs)"支配,而不是受工作量支配**。
按"未证明收益不留"的原则已回退(回退后二进制与 scale 版逐字节一致)。

### 42.4 本轮小结

- 引擎单次调用:2858 µs(修复前口径下同类测量约 3.2–3.9 ms)⇒ 本轮再拿 ~1.13×;
- 引擎成本结构:setup 8.6% + A 37.7% + B 36.6% + C 17.2%,其中解码占 43%;
- **下一步最高价值**:用 vdpbf16ps 重写解码/FMA(理论 1.5–2×,即每步省 ~40 ms);
  以及把"每次池调用 100–300 µs 的固定开销"打下来(3 阶段/层 × 43 层 = 129 次/步)。

### 42.5 试过但**挂死**回退的:限制解码时的参与 worker 数

发现:packed4 分支**根本没有传 `wlimit`**(源码注释明确写着"不要传"),所以真实解码时
**192 个 worker 全部参与每一个阶段**(3 阶段/层 × 43 层 = 129 次 192 路屏障/步)。
`small_batch_workers()` 这个现成机制只在非 packed4 分支生效 —— 这解释了为什么
解码期间有 193 个线程活跃、以及自旋修复的收益那么大。

实验:给 packed4 分支加 `XIAOTU_MOE_WLIMIT`(=0 不限制)并扫描 0/24/48/96。
结果:**0 正常(8081 µs,该时刻机器严重争抢);24 与 48 直接挂死**(600 s 超时未完成)。
原因就是 §33 记录的 limited + sharded 竞态:limited 子集按 `w % (nt/lim) == 0` 选取,
这些 worker 未必覆盖全部 8 个 NUMA 节点,而 sharded 派发要求"每个参与节点都至少有一个
worker 能领票"(`all_present` 只按全体 worker 判断,不按子集),没覆盖到的节点的 job
永远无人认领 ⇒ caller 一直等到 300 s 看门狗。

⇒ 已回退(恢复后二进制与 scale 版逐字节一致)。**要拿下这块(~100–300 µs/阶段 × 3 阶段
= 每步 15–30 ms),必须先修 `numa_pool` 的 limited+sharded 路径**(按节点均匀挑选子集,
或让 `all_present` 按子集判断),这是下一轮的候选工作。

### 42.6 未解之谜(留给下一轮):服务内单次调用比微基准慢 1.6–2×

同刻对比(负载 26–45):

| 口径 | M=6 单次调用 |
|---|---|
| 微基准(`DEDUP=0`,na≈32) | **2262–2483 µs** |
| 服务内(CD timing 的 compute) | **3780–5730 µs** |
| 服务内 NS-PROF 分桶(M3-8, na=18) | 8906 µs(该窗口含 prefill,偏高) |

服务内真实解码调用的 `na` 只有 **18**(比合成路线的 32 还少,字节更少),却慢一倍。
已排除的原因:**`OMP_NUM_THREADS=96`**(改成生产同款 OMP=1 后仍是 4.4–5.7 ms/层;
顺带确认 OMP 不是瓶颈)、负载均值(load 1.1 时服务内 compute 反而 4.6–5.4 ms)。
候选原因:①服务内 43 个引擎实例各自的 scratch 缓冲/页分布与单实例微基准不同;
②真机路由比合成更"散"(需要**纯解码窗口**下按 (M,na) 分桶再测);
③GPU 侧 DMA(pinned staging、KV 读写)与 CPU 引擎争抢内存带宽。
⇒ 下一轮第一件事:在**纯解码窗口**(单请求长输出、无 prefill 混入)下读 NS-PROF 分桶,
把 18 个专家的解码调用与微基准逐项对齐(A/B/C 分别比)。

### 43.6 服务端线程数扫描(同一台机、同一配置,负载 31–50)

| 引擎线程数 | 负载 | C=1 tok/s | 每步 ms | 每层 compute | C=2 合计(单路) | C=2 每步 |
|---|---|---|---|---|---|---|
| 192 | 1–45 | 8.25–9.98 | 281–339 | 4.4–5.7 ms | — | — |
| 176 | 50 | 11.44 | 193.9 | 3.22–3.63 ms | 15.75(7.88) | 302 ms |
| 160 | 38 | 11.66 | 185.2 | 2.29–2.41 ms | 18.71(9.36) | 263 ms |
| **144** | 33 | 12.57 | 162.3 | 1.70–2.21 ms | **21.65(10.82)** | 223 ms |
| **128** | 31 | **12.66** | **158.6** | **1.61–1.67 ms** | 21.60(10.80) | 220 ms |
| (128) C=4 | 31 | 22.2 合计(5.55/路) | 331 | — | — | — |

- 平台期在 **128–144**;服务端的最佳点比微基准(160–184)更靠下,因为服务进程里除
  调用线程外还有 torch/CUDA 驱动/采样/调度等线程,需要更多空闲核。
- 每层 compute 从 4.4–5.7(192)降到 **1.61–1.67 ms(128)** = **2.6–3.4×**;
  此时服务内 compute 已经等于(甚至优于)同形微基准(1.61–1.65 ms)⇒
  **上一轮那个"服务内比微基准慢 2×"的未解之谜就是这个原因**(调用线程抢核),
  不是内存/多实例/带宽问题。
- 接受长度 2.63–3.15(自然文本,达标)。
- 代价:参数变大(qlen=12)时每步 220–223 ms ⇒ 单路 10.8,与 C=1 的 12.66 相比
  每路只掉 ~15%(而 192 线程时 C=2 每路 7.88,掉 31%)⇒ 线程预留对多路也更友好。
- 预填/短上下文影响:TTFT 从 2.5 s(176)轻微变差到 3.0 s(128),可接受。

### 43.7 新默认值

- 插件:`XIAOTU_MOE_THREADS` 未设置时 = `ncpu - 16`(≥64 核)。
  **注意**:服务端实测最佳是 **128–144**(= ncpu-64…ncpu-48),所以脚本/生产配置应显式给值;
  `scripts/tune_serve.sh` 默认 `THREADS=176`,本轮的最佳配置请显式写 `THREADS=144`。
- 下一轮候选:把"预留核数"做成按进程线程数自适应(读 /proc/self/status 的 Threads,
  预留 = 非引擎线程数 + 余量),而不是固定值。

## 44. 【用户给定规则,务必遵守】解码线程数按"每 CCD 4–5 核"定,不要加核

> **规则(用户 2026-09-11 明确指示)**:解码性能的**最优解是每 CCD 开 4–5 个核心**;
> **更多核心不会带来更多带宽**,反而会**抢 L3** 与**抢散热/power 预算**,使性能变差。
> 本机 24 CCD ⇒ **96–120 线程**(不是 192,也不是我先前试的 128/168)。

佐证(自己仓库 + 公开文档,方向一致):

| 来源 | 结论 |
|---|---|
| `process_data/decomp/NUMA_BANDWIDTH_CCD.md`(本机实测) | 1 CCD 读 ~30 GB/s、写 ~11 GB/s;需要多 CCD 才能逼近峰值;**越过 6–8 CCD 后每 CCD 效率下降**(内存控制器饱和) |
| [LvLLM/lk_moe 官方 README](https://raw.githubusercontent.com/guqiong96/Lvllm/main/README.md) | `LK_THREADS` =(物理核 **÷** GPU 数);HT off 时 =(物理核 **− 2**)÷ GPU 数;`LK_THREAD_BINDING=CPU_CORE`;并宣称"L3 命中率 > 50%""跨 node 通信低至 3%" |
| 本次实测(见 §43) | 192 → 128 线程单调变好,但**我当时没有按"每 CCD 4–5 核"这条规则去定标**,只扫到 128 就停了 |

**本机取整:4 核/CCD = 96 线程,5 核/CCD = 120 线程。** 据此把默认值定为
`n_ccd × 5`(本机 120),并把 `scripts/tune_serve.sh` 默认改为 120;
不要再把线程数往上加(192/168/128 都是在抢 L3 与散热预算)。

### 44.1 与 lk_moe 的同模式端到端 A/B(2026-09-11,同 fork/同卡/同线程/无投机/无 CUDA graph)

用他们的 `process_data/scripts/serve_lkmoe_dsv4.sh`(`XIAOTU_MOE_BACKEND=lk`,TP=1、
max-model-len 8192、max-num-seqs 8、GPU_UTIL 0.5、`LK_THREADS=168`、`cudagraph NONE`、
无投机),与我们**完全同参数**的服务对照:

| 口径 | lk_moe(官方脚本) | 我们的引擎(同参数) | 比值 |
|---|---|---|---|
| C=1 tok/s | 6.52 | **9.53** | **1.46×** |
| C=1 每步 | 120.8 ms | **83.0 ms** | 1.46× |
| C=2 合计(单路) | 13.98(6.99) | **17.96(8.98)** | 1.28× |
| 每层 period | ≈2.81 ms(120.8/43) | **1.88–1.96 ms** | 1.45× |
| 每层 compute / rest | — | 0.76–1.12 / 0.76–1.19 ms | — |

⇒ **在完全相同的调度器/参数/硬件下,我们的 CPU MoE 引擎现在比 lk_moe 快 ~1.45×**
(本轮修复之前的历史 A/B 是他们快 1.6×)。差异主要来自引擎本身(compute)与
host 往返/rest,而不是外层编排(vLLM 调度器两边相同)。

### 44.2 硬数据:4–5 核/CCD 已把"内核能用的带宽"拿满(再加核反而更慢)

微基准(B=6、DEDUP=0 ⇒ na=32、每次调用读 403 MB 专家权重;A+B 为两段权重读取阶段):

| 线程数(=每 CCD) | A+B 用时 | 实测带宽 | 每节点 |
|---|---|---|---|
| **96(4 核/CCD)** | **1320 µs** | **305 GB/s** | 38 GB/s |
| **120(5 核/CCD)** | **1341 µs** | **301 GB/s** | 38 GB/s |
| 192(8 核/CCD) | 1604 µs | 251 GB/s | 31 GB/s |

- **4 核与 5 核/CCD 等价,8 核/CCD 反而慢 18%** ⇒ 完全印证用户规则(多加核不涨带宽,
  反而抢 L3 与散热/power 预算);
- 同时它把"剩下的差距"定性清楚了:机器纯流式上限 **783 GB/s**(8 节点 × 24 线程、NUMA 本地),
  而我们**内核只能吃掉 305 GB/s(39%)**——差的这部分是**每字节指令数**(FP4 解码 + FMA),
  不是线程数。⇒ 下一轮的正事是**减少每字节指令数**(AVX512-BF16 `vdpbf16ps` 重写解码+FMA),
  而不是加核。

### 44.3 口径校准:服务 vs 微基准真实差 1.26×(我先前说的 2.1× 是口径错误)

服务内真实路由形状是 **36 个 assignment 落在 ~18 个专家上(me≈2)**;我先前拿
`DEDUP=0`(na=32、403 MB)的微基准去比服务内(na=18、227 MB),字节数不同,结论作废。

同形状对照(同一时间窗口,120 线程):

| 口径 | setup | A | B | C | 合计 |
|---|---|---|---|---|---|
| 微基准 `DEDUP=18`(na=16) | 234 | 846 | 511 | 80 | **1670 µs** |
| 服务内 `[NS-PROF] M3-8 na≈17-19` | 68 | 1250 | 700 | 87 | **2105 µs** |

⇒ 服务/微基准 = **1.26×**(原因是服务里 GPU 侧与 torch/CUDA 线程并行、以及环境差异)。

### 44.4 在"每 CCD 4–5 核"前提下,FMA 指令数就是天花板(定量)

- 我们 A+B 的实际吞吐:**104–149 GB/s**(na=16-32、me=1.1-2),而机器可流式 **783 GB/s**
  ⇒ 只用掉 **13–20%**;
- 把"去掉解码"的诊断下限折算成指令数:na=32 时每节点 16k 行 × 128 组 × 6 实例 × 5 条
  指令 ≈ **63M 条/次调用**;4–5 核/CCD ⇒ 12–15 worker/节点 × 3 GHz × ~2 IPC ≈ **0.87 ms**
  —— 与实测的下限(~1.0 ms)**吻合**。
- ⇒ 结论:在每 CCD 4–5 核的约束下,**不可能靠加核换带宽**(已实测 8 核/CCD 反而慢 18%),
  唯一出路是**减少每条 MAC 的指令数**:AVX512-BF16 的 `vdpbf16ps`(一条指令 32 个 MAC,
  且激活本来就是 bf16、不必转 fp32;权重解码可共享)→ 理论上把 A+B 的指令数砍 40-50%。

### 44.5 回到 lk_moe 的代码级对比(同模式端到端)

同 fork/同卡/同线程/无投机/无 CUDA graph(他们的 `serve_lkmoe_dsv4.sh` vs 我们同参数服务):

| 口径 | lk_moe | 我们 | 比值 |
|---|---|---|---|
| C=1 tok/s | 6.52 | **9.53** | **1.46×** |
| 每步 | 120.8 ms | **83.0 ms** | 1.46× |
| C=2 合计(单路) | 13.98(6.99) | **17.96(8.98)** | 1.28× |
| 每层 period | ≈2.81 ms | **1.88–1.96 ms** | 1.45× |

⇒ "是计算模块强还是编排强"这个问题的答案:**编排两边是同一个 vLLM 调度器**,
差异全在 CPU MoE 引擎;本轮修复后**我们已反超 1.45×**(历史上是他们快 1.6×)。
但两者的**绝对效率都离机器上限很远**(见 44.4),所以这块仍有共同的挖掘空间。

### 44.6 实验:AVX512-BF16 `vdpbf16ps` 重写解码+FMA —— 只有 1.10×,且精度不达标 ⇒ 默认关闭

按"减少每字节指令数"的思路实现了 `XIAOTU_MOE_DPBF16` 路径(`moe_v2_packed4.hpp`,
AVX512-BF16 变体内):权重解码一次喂 M 行、结果以 bf16 留寄存器、激活直接用模型自带的
bf16(不再转 fp32)、每 (行,组) 用 1 条 `vdpbf16ps`(32 MAC)+ 1 条 fma 叠 e8m0 scale。

实测(同二进制、环境变量切换、交错 2 轮、DEDUP=18 = 服务内真实形状、120 线程):

| 口径 | setup | A | B | C | TOTAL |
|---|---|---|---|---|---|
| fp32(默认) | 259 | 872 | 553 | 96 | 1780–1791 µs |
| dpbf16 | 239 | 818 | 470 | 89 | **1611–1621 µs** |

⇒ **只有 1.10×**(A 1.07×、B 1.18×),远低于"指令数砍半"的预期 ⇒ 说明 A/B 两阶段
**不是 FMA 指令受限**(否则应接近 1.5-1.7×),而更像受**每线程工作量/访存层级**限制。

精度:受控对拍 8 档里 me=2 那档 max_rel **8.4e-3 > 项目门限 2e-3**(fp32 路径同档 3.9e-4),
其余 7 档 ~2e-4…9e-4 ✅ ⇒ **收益不足以为精度买单,已把默认值改为关**(=1 可开启做实验),
代码与开关保留。

**下一步该往哪查**(取代"砍指令数"这个已被证伪的假设):在 4-5 核/CCD 下每节点只有
12-15 个 worker,每个 worker 一次调用要处理 512 行 × 128 组 ⇒ 单 worker 工作量约
1.6M 条指令(≈0.27 ms @2 IPC),与实测 A(0.8 ms)同量级但仍有 3× 缺口 ⇒ 需要真正
的硬件计数器(本机 `perf_event_paranoid=4` 被禁)或更细的内部分段计时来定位。

### 44.7 下一个靶子(定量):**每核只跑到 2.5 GB/s,而单核顺序流式能到 36 GB/s**

- 机器实测(本机,`numactl` 本地内存):**单核 36 GB/s**、单节点 24 线程 98.7 GB/s、整机 783 GB/s;
- 我们的内核(120 线程 = 15 worker/节点):A+B 202 MB / 1290 µs = 157 GB/s 整机
  = **每节点 ~20 GB/s = 每核 2.5 GB/s**(约单核能力的 **7%**);
- 而 `vdpbf16ps` 实验证明"砍 FMA 指令数"只值 1.10× ⇒ **不是 FMA 受限**;
- ⇒ 剩下的解释只能是**每核的访存并行度(MLP)不足**:每个 worker 顺序扫 512 行 ×
  2048 B 的权重切片,行内是顺序读,但当前只有"下一行前 4 条 cache line"的预取
  (`_mm_prefetch(nr+{0,64,128,192})`),对 2048 B 的行来说预取深度远远不够,
  且每行处理完才进入下一行 ⇒ 有效未完成 miss 数很低。

**下一轮的具体做法(按性价比)**:
1. 让每个 worker 同时处理 **2–4 行**(行间交错),使独立访存流 ×2–4;
2. 预取改为覆盖整行(2048 B/行 = 32 条 cache line,按 4-8 条/次分批)并提前 1-2 行;
3. 若要精确归因,需要硬件计数器:本机 `perf_event_paranoid=4` 被禁,可考虑
   用 rdpmc 自采或找一台 perf 可用的机器做一次对照。

---

## 45. 用 standalone 微基准把"引擎结构 vs 内层循环"分开(2026-09-11)

### 45.1 方法

写了一个独立 C 程序(`/tmp/decbench.c`,已固化要点到本节),在同一台机、同一 NUMA 绑定下
只跑**内层循环本身**,四个模式读同一份 2048 B/行的权重数据:

| 模式 | 单核带宽 |
|---|---|
| `raw` 纯流式读(64 B/次) | **28 GB/s** |
| `decode` 完整 FP4 解码(2×PSHUFB + 2×UNPACK + insert + cvtepu16 + slli) | **5.6 GB/s** |
| `half` 只留 2×PSHUFB(shuffle 数减半) | 7.5 GB/s(仅 1.17×) |
| `decode+act2` 解码 + M=2 激活载入 + FMA(**与引擎内层同构**) | **5.0 GB/s** |

⇒ 解码把单核从 28 压到 5.6 GB/s,但**再砍一半 shuffle 指令只值 1.17×** ⇒ 不是 shuffle
端口受限,是"16 B/组的载荷 + 依赖链"本身的性质。

### 45.2 引擎结构确实还差 3.5×

- 引擎内层循环 standalone = **5.0 GB/s/核**;
- 引擎实际 = **1.15–2.2 GB/s/核**(A+B 202 MB / 1.45 ms / 120 线程);
- ⇒ 差距(2.3–3.5×)**不在内层循环,而在引擎结构**:每层 3 个阶段 + 屏障,而默认
  job 粒度是 `ceil(tpn/na)` ≈ **1.2 job/worker** —— 一个掉队 job(被其他租户线程/
  GPU host-fn 调用线程挤掉)就会拖慢整个阶段。

### 45.3 已落地修复:job 过度分片(每 worker ≈ 4 个 job)⇒ 1.23×

改 `moe_v2.hpp` 的 `need = ceil(4·tpn/na)`(下限 2,上限仍受 `spanA/32` 约束)。

| 口径(微基准,DEDUP=18,120 线程,2 轮一致) | A+B | 带宽 | 每核 |
|---|---|---|---|
| 旧默认(auto=1) | 1448–1469 µs | 138–140 GB/s | 1.15–1.16 GB/s |
| subA=2 | 1213–1217 | 166–167 | 1.38–1.39 |
| **subA=4(新默认)** | **1166–1199** | **168–173** | **1.40–1.44** |
| subA=8 | 1174–1236 | 163–172 | 1.36–1.43 |

新默认实测 1175 µs(1.43 GB/s/核),与强制 SHARDSPLIT=4 一致、比强制 =1(旧行为)快 **1.23×**;
数值对拍(`test_block23_equiv.py` 8/8、`test_swiglu_clamp_mxfp4.py`)全部通过。

### 45.4 下一步(结构性的,收益最大)

既然内层循环单核能跑 5 GB/s、而引擎只到 1.4 GB/s,剩下的差距主要是**每层 3 个阶段之间的
屏障/排空**。可做的方向(按收益):
1. **按专家分片(而不是按行分片)**:同一个专家在**一个节点内**完成 gate/up→SiLU→down
   的全流程(权重只读一次、三段之间不需要跨节点屏障),只有最后对 token 输出做一次
   跨节点归约 ⇒ 每层从 3 次全局屏障降到 1 次(代价:路由分布不均,需要按活跃专家数
   做负载均衡策略,或用动态任务窃取);
2. 把 C 阶段(加权归约)并进 B 阶段的收尾(减少一次屏障);
3. 若要精确到指令/停顿级,需要硬件计数器(本机 `perf_event_paranoid=4` 被禁)。

### 45.5 固定开销的第二次定位:每阶段 ~176 µs(与线程数/job 数无关)

用上节的诊断构建(空转,只留 job 分解+屏障)标定,并在不同线程数与分片数下扫:

| threads | subA | A(空转) | B(空转) | C | 合计 |
|---|---|---|---|---|---|
| 120 | 1 | 194 | 168 | 73 | 474 µs |
| 120 | 4 | 247 | 200 | 75 | 561 |
| 120 | 8 | 331 | 283 | 77 | 729 |
| 48 | 4 | 198 | 192 | 55 | 479 |
| 24 | 4 | 231 | 234 | 49 | 555 |

拟合 ⇒ **每阶段固定 ~176 µs + 每 job ≈1 µs**;固定部分与线程数(24/48/120)几乎无关。
正常调用里 A+B+C+setup = 1494 µs,其中固定 614 µs(**41%**)⇒ 三阶段屏障是最大的单块成本。

### 45.6 已落地:无锁任务发布(≈4%)

worker 原先在拿任务时要 `local_task = task_; stask = sharded_task_;`(全局锁 + `std::function`
拷贝/可能的堆分配)。改成发布 **(fn 指针, ctx)** 两个机器字(模板 thunk),worker 确认新一代后
直接读,不加锁不拷贝。实测(交错 2 轮):TOTAL 1577/1609 → **1522/1523**,C 阶段 111→69 µs,
A/B 基本不变。

### 45.7 试过但**挂死**回退的:worker 快照也去掉锁

进一步把 worker 的整个快照(gen/n/start/任务指针)改成无锁"先读 gen、读字段、再复检 gen"
(依据代码原有的 publish-first 约定)。结果:**直接挂死**(两次 600 s 超时未完成)——
正是这个池历史上踩过的丢唤醒/快照竞态(§33)。⇒ 已回退,回退后二进制与 `pool_lf` 逐字节一致,
并复测正常(1477 µs)。

**结论**:~176 µs/阶段的固定成本不能靠"去掉锁"消除(去掉锁会挂),只能靠**减少阶段数**或
改造屏障本身(例如按节点分组的两级屏障、或按专家分片让三段在一节点内完成)。

### 45.8 服务端验证(本轮内核:job 过度分片 + 无锁任务发布,120 线程)

| 配置 | C=1 | 每步 | tokens/步 | C=2 合计(单路) | 每层 compute / rest |
|---|---|---|---|---|---|
| 本轮 | **12.92 tok/s** | 157.9 ms | 2.95 | 19.93(9.97) | 1.90–2.14 / 0.92–1.10 ms |

- C=1 12.92 是本会话单路最好值(此前 12.66/128 线程、12.12/120 线程);
- 每步 157.9 ms ⇒ TPOT 53.8 ms(目标 40 ms);
- 剩余结构:每层 3 次全局屏障的固定成本 ~528 µs(35%),只能靠减少阶段数或按专家分片解决。
