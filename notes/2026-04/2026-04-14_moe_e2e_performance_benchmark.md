# MoE 端到端性能测试与 Super Kernel Overlap 分析

**日期**: 2026-04-14

## 工作概述

今天完成了 MoE (Mixture of Experts) 端到端性能测试，对比了 Megatron-Core 风格的分布式 MoE baseline 与 Super Kernel (通信-计算 overlap) 方案的性能差异。

## 主要成果

### 1. 创建了多个性能测试脚本

| 文件 | 说明 |
|------|------|
| `benchmarks/test_moe_e2e.hip` | 单 GPU HIP 测试（hipBLAS GEMM） |
| `benchmarks/test_moe_e2e_multi_gpu.hip` | 多 GPU 模拟测试（估算 XGMI A2A） |
| `benchmarks/bench_hf_moe.py` | HuggingFace Mixtral MoE 测试 |
| `benchmarks/bench_moe_8gpu.py` | 8 GPU 分布式 MoE 测试 |
| `benchmarks/bench_moe_baseline_8gpu.py` | **Megatron-Core 风格 8 GPU baseline** |

### 2. 8-GPU MoE Baseline 性能测试结果

使用 `bench_moe_baseline_8gpu.py` 测试，实现了 Megatron-Core 风格的分布式 MoE：

```
Gate -> Permute1 -> A2A Dispatch -> Expert GEMM -> A2A Combine -> Permute2 -> Combine
```

#### 测试配置与结果

| 配置 | Tokens/GPU | Baseline | A2A时间 | A2A带宽 | Comm/Compute | 70%Overlap | 加速比 | E2E TFLOPS |
|------|------------|----------|---------|---------|--------------|------------|--------|------------|
| Small | 2048 | 3.32ms | 1.06ms | 126 GB/s | 85% | 2.58ms | **1.29x** | 124 |
| Medium | 4096 | 9.91ms | 2.75ms | 195 GB/s | 59% | 7.98ms | **1.24x** | 333 |
| Large | 16384 | 46.64ms | 6.47ms | 332 GB/s | 23% | 42.11ms | **1.11x** | 760 |
| DeepSeek-V3 (mbs=2) | 1024 | 17.15ms | 1.88ms | 125 GB/s | 17% | 15.84ms | **1.08x** | 379 |
| DeepSeek-V3 (gbs=16) | 8192 | 68.25ms | 11.0ms | 171 GB/s | 24% | 60.56ms | **1.13x** | 761 |

### 3. DeepSeek-V3 配置详情

- **Seq length**: 4096
- **Hidden size**: 7168
- **FFN hidden**: 18432
- **Experts**: 256 total (32/GPU)
- **Top-K**: 8
- **Micro batch size**: 2

### 4. 关键发现

#### 4.1 Comm/Compute 比率决定 Overlap 收益

| 场景 | Comm/Compute | Overlap 收益 | 原因 |
|------|--------------|--------------|------|
| 小 batch（推理） | 60-85% | **1.24-1.29x** | 通信开销大，overlap 效果明显 |
| 大 batch（训练） | 17-24% | **1.08-1.13x** | 计算为主，overlap 收益有限 |

#### 4.2 A2A 带宽随消息大小变化

- 小消息（1K tokens）：~125 GB/s
- 大消息（16K tokens）：~332 GB/s
- XGMI 带宽利用率随消息增大而提升

#### 4.3 GEMM 效率

- 小 batch (mbs=2)：444 TFLOPS（效率较低）
- 大 batch (gbs=16)：945 TFLOPS（接近峰值）
- batch size 对 GEMM 效率影响显著

### 5. Super Kernel Overlap 原理

```
Baseline (Sequential):
  Gate -> Permute -> [A2A Dispatch] -> [Expert GEMM] -> [A2A Combine] -> Permute -> Combine
                     |<-- 通信 -->|    |<-- 计算 -->|   |<-- 通信 -->|

Super Kernel (Overlap):
  Gate -> Permute -> [A2A Dispatch ═══════════════════════════════] -> Permute -> Combine
                     [        Expert GEMM (tile-level pipeline)   ]
                     |<-- 通信与计算重叠，隐藏部分通信延迟 -->|
```

### 6. 结论与建议

1. **对于推理场景（小 batch）**：Super Kernel overlap 非常有价值，可带来 1.2-1.3x 加速

2. **对于训练场景（大 batch）**：overlap 收益较小（1.1x），但仍有意义

3. **优化方向**：
   - 提高 A2A 带宽利用率
   - 使用更细粒度的 tile 流水线
   - 在 Comm/Compute 接近 1:1 时效果最佳

## 相关文件

- `csrc/fused_moe_super_kernel.hip` - Super Kernel 实现（v8a 配置，~791 TFLOPS GEMM）
- `csrc/grouped_gemm.hip` - 高性能 Grouped GEMM 实现
- `docs/tile_overlap_analysis.md` - Tile Overlap 可行性分析

## 下一步计划

1. 实现真正的 tile-level comm-compute overlap
2. 集成 rocshmem 进行细粒度 IPC 通信
3. 在真实 DeepSeek-V3 推理场景中验证加速效果
