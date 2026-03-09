# MoE 系统深度解析：计算原理 × 论文优化地图

> **定位：** 从第一原理理解 MoE 计算，再看各论文解决了哪一段的问题  
> **覆盖：** 训练全流程 · 通信瓶颈 · 负载不均 · 内存压力 · 并行策略  
> **更新：** 2026-03-09

---

## 第一部分：MoE 是什么，为什么需要它

### 1.1 Dense vs MoE 的本质区别

```
Dense LLM（GPT / LLaMA 类）：

  每个 Token 经过所有参数
  ┌────────────────────────────────────────────┐
  │  Token → Attention → FFN(全量) → 输出      │
  │                       ↑                    │
  │               所有参数都激活                │
  └────────────────────────────────────────────┘
  计算量 ∝ 参数量 × Token 数
  扩大模型 → 计算量线性增长 → 成本爆炸


MoE LLM（DeepSeek-V3 / Mixtral 类）：

  每个 Token 只经过 K 个专家（K << N_experts）
  ┌────────────────────────────────────────────────────┐
  │                                                    │
  │  Token → Attention → Gate → 选 Top-K Expert       │
  │                               ↓                   │
  │                    Expert_3  Expert_7  (只激活K个) │
  │                               ↓                   │
  │                           加权合并 → 输出          │
  └────────────────────────────────────────────────────┘
  计算量 ∝ K/N_experts × 参数量 × Token 数
  扩大模型（增加专家） → 计算量几乎不变 → 参数/算力比极优
```

**核心公式：**
```
Dense:   FLOP/token = 2 × params
MoE:     FLOP/token = 2 × params × (K / N_experts)

DeepSeek-V3 示例：671B 参数，256 专家，Top-4 路由
  激活参数 ≈ 37B（671B × 4/256 ≈ 10.5B，加 Attn 约 37B）
  → 训练成本接近 37B Dense 模型，但效果接近 671B
```

---

## 第二部分：MoE 完整计算流程（逐步拆解）

### 2.1 单个 MoE Transformer Block 的完整数据流

```
输入：X [B, S, H]      B=batch, S=seq_len, H=hidden_dim
      ↓
  ┌──────────────────────────────────────────────────────────┐
  │                   Attention 子层                          │
  │                                                          │
  │  X → LayerNorm → [Q, K, V 投影] → Softmax(QK/√d)V      │
  │               → [输出投影] → Residual Add                │
  │                                                          │
  │  通信：若有 TP，需 All-Reduce（本层结束时）               │
  └──────────────────────────────┬───────────────────────────┘
                                 │
                                 ▼
  ┌──────────────────────────────────────────────────────────┐
  │                   MoE FFN 子层                            │
  │                                                          │
  │  Step 1: LayerNorm                                       │
  │  Step 2: Gate 计算（路由决策）                            │
  │  Step 3: All-to-All Dispatch（通信）← 瓶颈 ①             │
  │  Step 4: Expert FFN 计算（计算）   ← 瓶颈 ②             │
  │  Step 5: All-to-All Gather（通信） ← 瓶颈 ①             │
  │  Step 6: 加权合并 + Residual Add                         │
  └──────────────────────────────────────────────────────────┘
                                 │
                                 ▼
                           下一个 Block
```

---

### 2.2 Gate（路由）计算详解

```
输入：X [T, H]    T = B × S（展平后的 token 总数）

Gate 网络：
  logits = X @ W_gate    [T, N_experts]    W_gate: [H, N_experts]
  probs  = softmax(logits, dim=-1)         [T, N_experts]
  
Top-K 选择（K=2 为例，DeepSeek-V3 用 K=4）：
  top_k_indices  = argtopk(probs, k=K)     [T, K]     每 token 选 K 个 Expert
  top_k_weights  = probs[top_k_indices]    [T, K]     对应路由权重
  top_k_weights  = normalize(top_k_weights)           归一化（可选）

输出：
  每个 token → 知道要去哪 K 个 Expert
  每个 Expert → 知道会收到哪些 token（及权重）

负载统计：
  expert_load[e] = Σ_t 1[e ∈ top_k(t)]   [N_experts]
  理想情况：每个 Expert 收到 T×K/N_experts 个 token
  实际情况：严重不均（幂律分布）← 这是所有负载均衡论文的出发点
```

```
典型负载分布示意（DSv3 规模，256 专家，T=2048 token，K=4）：

token 数
  ▲
80│     *
70│    ***
60│   *****
50│  *******
40│ *********
30│***********  **
20│*************  ***
10│               *****  ***
 0│──────────────────────────────────────────→ Expert ID
   0   32   64   96  128  160  192  224  256

热点 Expert 可达平均值的 3~5 倍，严重倾斜
```

---

### 2.3 All-to-All Dispatch（分发通信）

这是 MoE 训练中最核心的通信操作：

```
场景：4 GPU EP 组，8 个 Expert（每卡 2 个），T=16 token（每卡 4 个）

分发前（各 GPU 持有本地 token）：
  GPU0: [t0→E0,E3] [t1→E1,E5] [t2→E0,E6] [t3→E2,E4]
  GPU1: [t4→E0,E2] [t5→E3,E7] [t6→E1,E4] [t7→E5,E6]
  GPU2: [t8→E2,E7] [t9→E0,E3] [t10→E1,E5][t11→E4,E6]
  GPU3: [t12→E3,E6][t13→E1,E2][t14→E0,E7][t15→E2,E5]

Expert 分配：
  GPU0: E0, E1
  GPU1: E2, E3
  GPU2: E4, E5
  GPU3: E6, E7

All-to-All Dispatch 后（各 GPU 收到发往本地 Expert 的 token）：
  GPU0(E0,E1): t0,t2,t4,t9,t14（去E0）+ t1,t6,t13（去E1）
  GPU1(E2,E3): t3,t8,t13,t15（去E2）+ t0,t5,t9,t12（去E3）
  GPU2(E4,E5): t3,t6,t11（去E4）+ t1,t7,t10,t15（去E5）
  GPU3(E6,E7): t2,t7,t11,t12（去E6）+ t5,t8,t14（去E7）

通信量 = T × H × sizeof(dtype) per GPU（双向）
        = 2048 × 4096 × 2 bytes ≈ 16 MB per GPU per A2A（典型值）
```

```
时间线（传统串行执行）：

GPU  ──────────────────────────────────────────────────→ 时间
     │ Gate │████ A2A Dispatch ████│ Expert GEMM │████ A2A Gather ████│
             ↑                    ↑              ↑                    ↑
             发送 16MB             GPU 空等       发送 16MB             GPU 空等
             等待所有 GPU 完成                    等待所有 GPU 完成

A2A 延迟 ≈ 5~20ms（节点内） / 20~60ms（跨节点）
Expert GEMM ≈ 3~15ms
→ 通信占总时间 50~60%  ← MoE 通信瓶颈的根源
```

---

### 2.4 Expert FFN 计算详解

```
一个 Expert 的 FFN（以 SwiGLU 为例，DeepSeek-V3 架构）：

输入：X_e [T_e, H]    T_e = 分配到该 Expert 的 token 数

Gate proj:   G = X_e @ W_gate   [T_e, F]    F = ffn_intermediate_dim
Up proj:     U = X_e @ W_up     [T_e, F]
激活:        A = SiLU(G) ⊙ U   [T_e, F]    逐元素乘
Down proj:   Y = A   @ W_down   [T_e, H]    Expert 输出

参数量：W_gate[H,F] + W_up[H,F] + W_down[F,H]
       = 3 × H × F
       典型值：H=4096, F=14336 → 约 176M 参数 per Expert
       DSv3：256 Expert × 176M ≈ 45B Expert 参数（总参数 671B 中的大部分）

计算量 per token：2 × 3 × H × F ≈ 2 × 176M ≈ 352M FLOP per token
```

```
负载不均衡对计算的影响：

理想情况（均衡）：                实际情况（不均衡）：
  GPU0: T_E0=50, T_E1=50           GPU0: T_E0=200, T_E1=50 ← 过载
  GPU1: T_E2=50, T_E3=50           GPU1: T_E2=30,  T_E3=20
  GPU2: T_E4=50, T_E5=50           GPU2: T_E4=15,  T_E5=10
  GPU3: T_E6=50, T_E7=50           GPU3: T_E6=10,  T_E7=5

  各 GPU 耗时相同 ✅               GPU0 耗时 = 其他 GPU 的 4~8x ❌
                                   所有 GPU 必须等 GPU0 完成才能进行下一步
```

---

### 2.5 All-to-All Gather（聚合通信）

```
Expert 计算完成后，输出需要送回 token 原始所在的 GPU：

All-to-All Gather 后（各 GPU 收回本地 token 的 Expert 输出）：
  GPU0: Y_t0_E0, Y_t0_E3, Y_t1_E1, Y_t1_E5, ...  （本地 4 个 token 的所有 Expert 输出）
  GPU1: Y_t4_E0, Y_t4_E2, ...
  GPU2: Y_t8_E2, Y_t8_E7, ...
  GPU3: Y_t12_E3, Y_t12_E6, ...

加权合并：
  output_ti = Σ_k (w_k × Y_ti_Ek)    对每个 token 的 K 个 Expert 输出加权求和
```

---

### 2.6 完整前向 + 反向通信全景

```
一个 MoE Block 的完整通信清单（前向 + 反向）：

前向：
  ① TP All-Reduce（Attention 输出）       ← 节点内，高带宽
  ② A2A Dispatch（token 分发）            ← 跨节点，低带宽，延迟高
  ③ A2A Gather（Expert 输出聚合）         ← 跨节点，低带宽，延迟高

反向：
  ④ A2A Dispatch_bwd（=③的反向）         ← 跨节点
  ⑤ A2A Gather_bwd（=②的反向）           ← 跨节点
  ⑥ AllReduce(dW_expert)                 ← DP 维度梯度同步
  ⑦ AllReduce(dW_attn)                   ← DP 维度梯度同步
  ⑧ FSDP AllGather / ReduceScatter       ← 若开了 ZeRO

合计：8 次独立通信操作（Dense 模型同等规模仅 2~3 次）
→ MoE 通信密度是 Dense 的 3~4 倍
```

---

## 第三部分：核心瓶颈地图

```
MoE 训练的四大瓶颈：

┌─────────────────────────────────────────────────────────────────────┐
│                                                                     │
│  瓶颈 ①：通信墙（Communication Wall）                               │
│                                                                     │
│  A2A Dispatch + A2A Gather 占总 Step 时间 50~60%                    │
│  根本原因：通信与计算完全串行，GPU 在通信期间空转                    │
│                                                                     │
│  瓶颈 ②：负载不均（Load Imbalance）                                 │
│                                                                     │
│  动态路由导致 Expert 负载幂律分布                                    │
│  max_load / avg_load 可达 3~5x                                      │
│  整体 GPU 利用率 = 1 / 不均衡比 ≈ 20~33%                           │
│                                                                     │
│  瓶颈 ③：显存压力（Memory Pressure）                                │
│                                                                     │
│  激活内存：每层需保存中间激活用于反向传播                            │
│  参数内存：N_Expert 个完整 Expert 参数                               │
│  路由缓冲：Token routing buffer（中间临时张量）                      │
│                                                                     │
│  瓶颈 ④：并行策略冲突（Parallelism Conflict）                       │
│                                                                     │
│  Attention 层最优并行 ≠ MoE 层最优并行                              │
│  强行使用统一配置 → 其中一层效率受损                                 │
│                                                                     │
└─────────────────────────────────────────────────────────────────────┘
```

---

## 第四部分：论文优化地图

### 4.1 各论文解决的瓶颈对应关系

```
                    MoE 训练瓶颈 × 论文覆盖图

                  ┌──通信墙──┬──负载不均──┬──显存压力──┬──并行冲突──┐
                  │          │            │            │            │
  Comet           │  ██████  │            │  ███       │            │
  FlowMoE         │  █████   │            │  ██        │            │
  LAER-MoE        │  ██      │  ████████  │  ███       │            │
  MoEBlaze        │          │            │  ████████  │            │
  MemFine         │          │            │  ███████   │            │
  MoE Par.Fold    │  ██      │            │            │  ████████  │
  MegaScale-MoE   │  █████   │  ████      │            │  ███       │
  FlowMoE         │  █████   │            │  ██        │            │
  SwiftMoE        │          │  ████      │  ████      │            │
                  └──────────┴────────────┴────────────┴────────────┘

图例：█ = 优化覆盖强度
```

---

### 4.2 通信墙优化论文详解

#### Comet（MLSys '25）—— Tile 级 GEMM-通信 Overlap

```
问题：A2A Dispatch/Gather 与 Expert GEMM 完全串行

传统执行时间线：
  ──────────────────────────────────────────────────→ 时间
  │ Gate │████ A2A Dispatch ████│ Expert GEMM │████ A2A Gather ████│
          ↑ GPU 空等 ↑                         ↑ GPU 空等 ↑

Comet 的解法：GEMM Tile 与 RDMA 在同一 Kernel 内并发
  ──────────────────────────────────────────────────→ 时间
  │ Gate │ GEMM_T1 │ GEMM_T2 │ GEMM_T3 │ GEMM_T4 │...│
           │RDMA_T1│ │RDMA_T2│ │RDMA_T3│ │RDMA_T4│
           ↑ 计算与通信完全重叠 ↑

实现机制：Warp 专用化（Warp Specialization）
  Warp Group 0,1,2 → 负责 Expert GEMM 的矩阵计算
  Warp Group 3     → 监听 LDS（共享内存），发现计算完成的 Tile 立即发 RDMA

效果：
  通信-计算重叠率：90%+（传统 ~15%）
  MoE 层吞吐提升：2.3x
  端到端加速：1.8x
```

#### FlowMoE（NeurIPS '25）—— 跨层 DAG 调度

```
问题：各层计算和通信各自独立调度，无跨层视野

FlowMoE 的解法：统一 DAG 调度器 + Tensor Chunk 优先级

跨层 Overlap：
  Block_i  Forward: │Attn_i│──│A2A_D_i│────│Expert_i│──│A2A_G_i│
                              ↕ overlap（NCCL stream 独立）
  Block_i+1 Forward:          │Attn_{i+1}│──│A2A_D_{i+1}│──...

Chunk 级调度：
  把大 Tensor 切成多个 chunk，chunk_1 通信与 chunk_2 计算重叠
  ┌────────┐  ┌────────┐  ┌────────┐
  │chunk1  │  │chunk2  │  │chunk3  │
  │compute │  │compute │  │compute │
  └────────┘  └────────┘  └────────┘
       │comm1      │comm2      │comm3
       └───────────└───────────└──── 并发

效果：
  训练时间减少：13~57%（通信受限场景收益最大）
  能耗降低：10~39%
  内存减少：7~32%（即时释放 + chunk 复用）
```

#### MegaScale-MoE（EuroSys '26）—— 拓扑感知路由

```
问题：万卡规模下，All-to-All 路由不感知网络拓扑，大量流量走低带宽路径

网络拓扑带宽层次：
  同 GPU（本地）     ：无通信
  同节点（XGMI/NVLink）：~896 GB/s（高）
  同 Rack（Leaf-Leaf）：~100 Gbps（中）
  跨 Rack（Leaf-Spine）：~25 Gbps（低）
  跨 Pod              ：更低

MegaScale-MoE 的解法：拓扑感知的 Expert 放置 + 分层 A2A

  优先级路由策略：
  ① 本地 GPU Expert → 无通信（最高优先）
  ② 同节点 Expert   → XGMI 高带宽
  ③ 同 Rack Expert  → 较高带宽
  ④ 跨 Rack Expert  → 仅必要时使用

  分层 EP：
  ┌─ Node 0 ──────────┐  ┌─ Node 1 ──────────┐
  │ GPU0 GPU1 GPU2 GPU3│  │ GPU4 GPU5 GPU6 GPU7│
  │  节点内 A2A（快）   │  │  节点内 A2A（快）   │
  └─────────┬──────────┘  └─────────┬──────────┘
            └──────── 跨节点 A2A（慢，尽量少）───┘

效果：
  A2A 延迟降低：45%
  万卡 MFU：~42%
```

---

### 4.3 负载不均优化论文详解

#### LAER-MoE（ASPLOS '26）—— FSEP + 动态 Re-layout

```
问题：动态路由导致 Expert 负载幂律分布，热点 GPU 成瓶颈

LAER-MoE 的解法：两层设计

层 1 - FSEP（全分片专家并行）：机制层

  传统 EP：每个 Expert 完整放在一块 GPU
  GPU0: [Expert_0 完整] [Expert_1 完整]   ← E0 过载时无法分担

  FSEP：每个 Expert 参数分片到多块 GPU（沿 FFN 中间维度切）
  GPU0: [E0_shard_0/4] [E1_shard_0/4] ...  ← 每卡持有所有 Expert 的 1/4

  计算时（以 E0 为例，分片度 S=4）：
  GPU0: tokens_E0 @ W_E0_up_s0 → partial_act_0 → partial_out_0 [T_E0, H]
  GPU1: tokens_E0 @ W_E0_up_s1 → partial_act_1 → partial_out_1 [T_E0, H]
  GPU2: tokens_E0 @ W_E0_up_s2 → partial_act_2 → partial_out_2 [T_E0, H]
  GPU3: tokens_E0 @ W_E0_up_s3 → partial_act_3 → partial_out_3 [T_E0, H]
  → ReduceScatter → 完整 Expert 输出

  效果：400 token 的热点 Expert 被 4 GPU 均分 → 每卡只算 100 token

层 2 - Re-layout（动态重布局）：策略层

  Load Planner 每 K 步检测一次负载：
  ┌──────────────────────────────────────────────────┐
  │  检测：E2 热点（800 token），E5 冷点（5 token）  │
  │  决策：E2 的分片度 S: 2 → 4                     │
  │        E5 的分片度 S: 2 → 1                     │
  │  执行：在反向传播期间异步搬迁参数分片             │
  │  生效：下一个 Step 开始使用新布局                 │
  └──────────────────────────────────────────────────┘

  类比：FSEP = 可扩缩车道的高速公路
        Re-layout = 根据实时拥堵动态开放/关闭车道的管控系统

负载均衡效果对比：
  不均衡比 r = max/avg = 4（典型）

  传统 EP:  耗时 ∝ 4 × avg_compute    GPU 利用率 25%
  FSEP S=4: 耗时 ∝ 1 × avg_compute    GPU 利用率 95%+

通信代价：
  传统 EP:  2 × T × H（A2A Dispatch + Gather）
  FSEP:     3 × T × H（额外 ReduceScatter）
  → 多 50% 通信，但计算效率提升 3~4x，净收益 1.69x

效果：端到端 1.69x 加速（ASPLOS A 类，最具说服力的端到端指标）
```

#### SwiftMoE（arXiv '25）—— 参数-优化器解耦

```
问题：MoE 的 Expert 参数和优化器状态（Adam m/v）通常绑定在同一 GPU
     导致：负载不均衡 + 优化器状态显存占比过高

SwiftMoE 的解法：解耦 Expert 参数与优化器状态的存储位置

  传统：Expert_i → 参数 + Adam(m_i, v_i) 都在 GPU_k
  SwiftMoE：Expert_i 的参数可以在 GPU_k，Adam 状态可以在 GPU_j（任意）

  好处：
    ① 参数放置可以根据计算负载动态调整（不受优化器状态拖累）
    ② 优化器状态按 Expert 冷热分级存储（冷 Expert 的状态可以 offload）

效果：vs DeepSpeed +30.5% 收敛速度
```

---

### 4.4 显存优化论文详解

#### MoEBlaze（arXiv '26）—— 数据结构 + Kernel 融合 + Smart AC

```
问题：MoE 的路由过程产生大量中间 Buffer，激活内存峰值极高

传统 Token Dispatch 的显存浪费：
  Input [B,S,H]
       ↓
  Gate → Routing Index Buffer（临时大张量，全量存储）← 浪费 ①
       ↓
  Token Dispatch Buffer（再次拷贝）← 浪费 ②
       ↓
  Expert Compute

MoEBlaze 的三层优化：

  优化①：轻量路由索引（消除中间 Buffer）
  Input → Gate → 直接生成紧凑索引（无大 Buffer）→ 就地 Dispatch + Compute

  优化②：Gate + Dispatch + Expert GEMM 融合 Kernel
  三个操作合并为单个 CUDA Kernel，消除 Host-Device 数据搬运

  优化③：Smart Activation Checkpointing（Smart AC）
  传统 AC：要么全保存（显存多），要么全重算（时间多）

  Smart AC：
  ┌───────────────────────────────────────────────────────┐
  │  对每个激活 tensor，评估「重算代价」vs「存储代价」       │
  │                                                       │
  │  重算代价低（Gate 输出等）→ 不保存，反向时重算          │
  │  重算代价高（Expert GEMM 中间值）→ 保存                │
  │                                                       │
  │  MoE 特有：稀疏激活 tensor 可以压缩存储（只存非零部分）  │
  └───────────────────────────────────────────────────────┘

效果：
  训练速度：4x（Kernel 级）
  显存：减少 50%
```

#### MemFine（arXiv '25）—— Chunk 激活调度 + 选择性重计算

```
问题：MoE 层的激活内存峰值发生在 Expert GEMM 期间
     所有 token 的中间激活同时存在 → 峰值 ∝ T × F

MemFine 的解法：以 Chunk 为单位串行执行 + 选择性重计算

  传统：所有 token 一起做 Expert GEMM
  ┌──────────────────────────────────────┐
  │  Expert GEMM（全量 T tokens）         │  ← 峰值显存 = T × F
  └──────────────────────────────────────┘

  MemFine：把 T tokens 分成 C 个 chunk，串行执行
  ┌────────┐  ┌────────┐  ┌────────┐  ┌────────┐
  │chunk_1 │  │chunk_2 │  │chunk_3 │  │chunk_4 │
  │T/C tok │  │T/C tok │  │T/C tok │  │T/C tok │
  └────────┘  └────────┘  └────────┘  └────────┘
  ↑ 每次只有 1 个 chunk 的激活存在显存中
  峰值显存 = T/C × F（降低 C 倍）

  反向传播时：对某些 chunk 选择性重计算（而非保存所有激活）
  → 在显存节省和重算代价之间精细平衡

效果：
  激活内存：减少 48%
  吞吐提升：4.42%（显存节省允许更大 batch）
```

---

### 4.5 并行策略优化论文详解

#### MoE Parallel Folding（arXiv '25，NVIDIA）—— 五维并行 + Attn/MoE 解耦

```
问题：Attention 层和 MoE 层的最优并行配置不同，强行统一导致其中一层低效

  Attention 层特点：参数较小，计算密集
    → 适合 TP（张量并行）：把 Q/K/V 按 head 分割到多 GPU
    → 适合 CP（上下文并行）：把长序列分割
    → 不适合 EP：Attention 没有 Expert 结构

  MoE FFN 层特点：Expert 众多，有天然的分组结构
    → 适合 EP（专家并行）：把 Expert 分配到不同 GPU
    → TP 意义较小（每个 Expert 相对独立）

MoE Parallel Folding 的解法：同一 Block 内 Attn 和 MoE 用不同并行配置

  Block_i 的执行：
  ┌──────────────────────────────────────────────────────────┐
  │  Attention 子层：                                         │
  │    GPU 分组：{0,1,2,3} TP=4, {4,5,6,7} TP=4             │
  │    配置：TP=4, DP=2, EP=1, CP=1                          │
  │    ↓ Parallel Folding（All-to-All 重映射 GPU 分组）       │
  │  MoE FFN 子层：                                           │
  │    GPU 分组：{0},{1},{2},{3},{4},{5},{6},{7} EP=8         │
  │    配置：TP=1, DP=1, EP=8, CP=1                          │
  └──────────────────────────────────────────────────────────┘

  "Folding" = 在 Attn 和 MoE 之间插入一次 All-to-All，
              重新映射 token 到不同的 GPU 分组

五维并行支持：TP × EP × DP × PP × CP 任意组合
支持 1024 GPUs + 128K token 长序列

效果：H100 上 Mixtral 8x22B 达 49.3% MFU
```

---

## 第五部分：优化技术全景图（汇总）

```
MoE 训练完整优化栈（从底层到顶层）：

时间轴 →
  ┌─────────────────────────────────────────────────────────────────────┐
  │                         一个训练 Step                               │
  │                                                                     │
  │  ┌─────────────────────────────────────────────────────────────┐   │
  │  │                    前向传播（Forward）                        │   │
  │  │                                                             │   │
  │  │  [Attn] ──► [Gate] ──► [A2A Dispatch] ──► [Expert FFN]     │   │
  │  │                                        ──► [A2A Gather]     │   │
  │  │                                        ──► [合并输出]        │   │
  │  └─────────────────────────────────────────────────────────────┘   │
  │                             ↓                                       │
  │  ┌─────────────────────────────────────────────────────────────┐   │
  │  │                    反向传播（Backward）                       │   │
  │  │                                                             │   │
  │  │  [dAttn] ◄── [dGate] ◄── [A2A_bwd] ◄── [dExpert FFN]      │   │
  │  │                                     ◄── [AllReduce(dW)]     │   │
  │  └─────────────────────────────────────────────────────────────┘   │
  └─────────────────────────────────────────────────────────────────────┘

各论文的优化插入点：

  [A2A Dispatch] ──── Comet：Tile级Overlap          ─── 通信墙
  [A2A Gather]   ──── FlowMoE：跨层DAG调度           ─── 通信墙
  [Expert FFN]   ──── LAER-MoE：FSEP+Re-layout       ─── 负载不均
  [Expert FFN]   ──── MoEBlaze：Kernel融合+SmartAC   ─── 显存压力
  [Expert FFN]   ──── MemFine：Chunk激活调度          ─── 显存压力
  [Attn+MoE]     ──── MoE Parallel Folding：5D并行   ─── 并行冲突
  [全局]         ──── MegaScale-MoE：拓扑感知+容错   ─── 万卡生产
  [dW AllReduce] ──── SwiftMoE：参数优化器解耦        ─── 负载+显存
```

---

## 第六部分：性能数据一览

```
各论文核心性能提升（vs 对应基线）：

论文               场景          关键指标              提升幅度
─────────────────────────────────────────────────────────────
Comet             训练          端到端吞吐             1.8x
                               通信-计算重叠率         90%+（传统~15%）
─────────────────────────────────────────────────────────────
FlowMoE           训练          训练时间               -57%（通信受限场景）
                               能耗                   -39%
─────────────────────────────────────────────────────────────
LAER-MoE          训练          端到端加速             1.69x
                               GPU 利用率              ~95%（传统~25%）
─────────────────────────────────────────────────────────────
MoEBlaze          训练          速度（Kernel级）        4x
                               显存                   -50%
─────────────────────────────────────────────────────────────
MemFine           训练          激活显存               -48%
                               吞吐（更大batch）        +4.42%
─────────────────────────────────────────────────────────────
MoE Par.Fold      训练          MFU（H100）            49.3%
                               规模                   1024 GPU
─────────────────────────────────────────────────────────────
MegaScale-MoE     生产训练       MFU（万卡）            ~42% @ 10K GPU
                               A2A 延迟               -45%
─────────────────────────────────────────────────────────────
SwiftMoE          训练          收敛速度               +30.5% vs DeepSpeed
─────────────────────────────────────────────────────────────
```

---

## 第七部分：技术选型建议

```
根据你的场景选择优化方向：

场景                      首选论文              关注瓶颈
──────────────────────────────────────────────────────
通信占比 > 40%            Comet + FlowMoE       通信墙
Expert 负载不均衡严重     LAER-MoE              负载不均
显存 OOM / batch 受限     MoEBlaze + MemFine    显存压力
Attn 和 MoE 并行冲突      MoE Parallel Folding  并行策略
万卡生产部署              MegaScale-MoE         稳定性+性能
全栈优化（推荐叠加）       ↓

  推荐叠加顺序（ROI 递减）：
  第一层：MoEBlaze（显存，实现简单，收益稳定）
  第二层：LAER-MoE（负载均衡，端到端收益最大）
  第三层：Comet（通信 Overlap，实现复杂但天花板高）
  第四层：FlowMoE（跨层调度，与 Comet 互补）
  第五层：MoE Parallel Folding（5D 并行，大规模集群必须）
```

---

*文档整理于 2026-03-09 | ROCflow 框架设计讨论 | AIInfra-Book*
