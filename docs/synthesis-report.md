# 综合报告: Alternating Optimization Framework vs LoRA

> **⚠️ SUPERSEDED as of 2026-06-22**. This document reflects the state from experiments #001-#006 (June 2026). Current findings reverse key claims: sufficient-rank LoRA (r=256) outperforms full-rank by 27× on perplexity, LoRA beats full-rank on all downstream tasks, and the WikiText-2 "full-rank advantage" is an overfitting artifact. See [paper v1.3](../paper/paper_draft_v0.2.md) and [todo.md](../todo.md).

**日期**: 2026-06-12 (superseded)  
**覆盖**: 实验 #001–#006 + 矩阵实验 + 数学分析  
**代码量**: ~6,000 LOC / 115 tests / 3 架构 / 80+ independent runs  

---

## 1. 项目全景

### 1.1 研究问题

比较两类 LLM 后训练策略:

| 策略 | 本质 | 代表 |
|------|------|------|
| **交替优化框架** | 优化器创新 — 决定参数「怎么更新」 | ALS + SGD + 随机扰动 |
| **低秩适配 (LoRA)** | 参数结构创新 — 决定参数「以何种形态存在」 | ΔW = BA, 绑定 AdamW |

**核心方法论贡献**: 2×2 析因实验协议（优化器 × 参数形态），在统一 FLOPs 预算下解耦两类独立变量。

### 1.2 全部实验

| # | 模型 | 步数 | Seeds | 核心发现 |
|---|------|------|-------|---------|
| #001 | GPT-2 | 40 | 1 | 2×2 框架可行；Protocol C FLOPs 效率 |
| #002 | OPT-125m | 100 | 1 | LoRA 主导；ALS:SGD=1:20 最优 |
| #003 | — | — | — | 7B 基础设施 + 消融框架 |
| #004 | GPT-2 | 12 | 2 | 可复现性差；扰动正则化 |
| #005 | OPT-125m | 200 | 3 | 统计 2×2；PEFT vs 内置 LoRA gap |
| #006 | OPT-125m | 400 | 2 | 长 SGD 周期；首次发现交叉点趋势 |
| **Matrix** | **OPT+Qwen** | **50-800** | **1** | **非单调收敛；A-B gap 缩小 150×** |

### 1.3 三架构 2×2 矩阵 (100 steps)

| | GPT-2 124M | OPT-125m | Qwen2.5-0.5B |
|---|---|---|---|
| A (AltOpt/Full) | 185 | 651 | 3,766 |
| B (AdamW/Full) | 8.3 | 22.3 | 44.4 |
| C (AltOpt/LoRA) | 10.0 | 5.5 | 118.9 |
| D (AdamW/LoRA) | **8.3** | **4.6** | **32.2** |
| A-B gap | 177 | 629 | 3,722 |

---

## 2. 矩阵实验: 核心发现

### 2.1 A-B gap 随步数的非单调收敛

```
OPT-125m (12 layers):
  Steps:   50     100    200    400    800
  gap:    39k →  85k →  30k → 11k →  563  (缩小 150×)
  
Qwen2.5-0.5B (24 layers):  
  Steps:   50     100    200    400    800
  gap:    10k → 135k → 8.8k → 397k → 3.0k (缩小 134×)
```

**关键洞察**: gap 在 ALS 周期边界出现二次峰值（非单调）。每个新 ALS cycle 在上一个未完全消化时叠加新的 perturbation。但宏观趋势持续缩小 — **AltOpt 在 800 步时正在逼近 AdamW**。

### 2.2 AdamW 的 plateau 现象

AdamW 在 50-100 步内已收敛到稳定 ppl (OPT: ~17, Qwen: ~65)，之后几乎不变。而 AltOpt 在 800 步仍在持续改善。这暗示**超长训练中 AltOpt 可能最终超越**。

---

## 3. 数学分析核心结论

见完整文档: [`docs/math-analysis.md`](docs/math-analysis.md)

| 洞察 | 实验验证 |
|------|----------|
| ALS reconstruction loss ~O(N·d·‖W‖²) ≈ 10⁵ | 第一步 loss ~10⁵（6/6 实验） |
| BCD Lipschitz 常数在深层网络中很大 | AltOpt 200 步仍落后 |
| A-B gap 振荡指数衰减: gap(t) = Σ A_c·e^(-α(t-t_c)) | 矩阵实验峰值结构 |
| 消化时间 ∝ L^1.2（超线性） | OPT 12层 ~125步, Qwen 24层 ~250步 |
| LoRA 低秩流形降低有效条件数 | CV <5% vs full-rank CV 40-55% |
| 参数噪声 ≈ 隐式 SAM | 扰动改善 eval ppl, 恶化 train loss |

**交叉点预测**: OPT-125m ~1,000 步 | Qwen-0.5B ~2,000 步 | Llama-7B ~3,000 步

---

## 4. 论文思路与论证过程

### 标题建议

> **Disentangling Optimizer and Parameter Form: A 2×2 Factorial Study of Alternating Optimization vs Low-Rank Adaptation for LLM Post-Training**

### 核心论点 (Thesis)

交替优化框架（ALS+SGD+扰动）和 LoRA 代表了 LLM 后训练中两种独立的设计维度 — 优化策略 vs 参数形态。通过 2×2 析因实验在统一资源预算下比较，我们发现: (1) 低秩参数形态在低步数下主导性能，(2) 交替优化的优势需要超长训练才能显现，(3) ALS→SGD 过渡中的非单调收敛是交替方法的核心挑战。

### 论证链

```
Claim 1: "优化器效应"和"参数形态效应"必须解耦
  ├─ 问题: 任何直接的 AltOpt vs LoRA 对比都混杂了两类独立变量
  ├─ 方法: 2×2 析因设计 (Optimizer × Parameter Form)
  └─ 证据: 交互效应 1197.7 (Round 5) — 优化器效应在 full-rank 空间远大于 LoRA 空间

Claim 2: LoRA 的低秩约束在 ≤200 步时是主导因子
  ├─ 方法: 比较 Protocol B (AdamW/Full) vs D (AdamW/LoRA)
  ├─ 证据: LoRA 带来 5-30× PPL 改善 (3/3 架构)
  ├─ 理论: 低秩流形降低有效条件数 → 加速收敛
  └─ 文献: BaLoRA, LoRA convergence O(1/log T)

Claim 3: AltOpt 的 ALS→SGD 过渡产生非单调收敛
  ├─ 方法: 5 点矩阵实验 (50→800 steps)
  ├─ 证据: A-B gap 在 ALS 周期边界出现二次峰值
  │         OPT: 39k→85k→30k→11k→563
  │         Qwen: 10k→135k→9k→397k→3k
  ├─ 理论: 振荡指数衰减模型 gap(t) = Σ A_c·e^(-α(t-t_c))
  └─ 机制: ALS 重置 SGD 动量 + 忽略层间耦合

Claim 4: AltOpt 在超长训练中正在逼近 AdamW
  ├─ 方法: 800-step 矩阵实验
  ├─ 证据: OPT A-B gap 从 84,778 (peak) → 563 (800s), 缩小 150×
  ├─ 预测: OPT 交叉点 ~1,000 steps; Qwen ~2,000 steps
  └─ 对比: AdamW 在 50-100步 plateau; AltOpt 800步仍在改善

Claim 5: 参数噪声的泛化-收敛权衡
  ├─ 方法: RQ3 对比 with/without perturbation
  ├─ 证据: Perturbation 提高 train_loss 但降低 eval ppl (86k vs 317k)
  ├─ 理论: RWP ≈ 隐式 SAM → 平坦极小值
  └─ 文献: RWP generalization-convergence trade-off
```

### 建议论文结构

```
1. Introduction
   - 后训练的两种范式: 优化器创新 vs 参数结构创新
   - 核心矛盾: 混杂变量导致不可归因
   - 贡献: 2×2 析因协议 + 统一资源核算

2. Background & Related Work
   2.1 ALS/BCD/ADMM for Neural Networks (Zeng 2019, Wang 2018)
   2.2 LoRA and Low-Rank Training Dynamics (BaLoRA, LoRA convergence)
   2.3 Perturbation-based Generalization (SAM, RWP)

3. Methodology: 2×2 Factorial Design
   3.1 Four Protocols: A (AltOpt/Full), B (AdamW/Full), C (AltOpt/LoRA), D (AdamW/LoRA)
   3.2 Unified FLOPs Accounting (per-phase breakdown)
   3.3 Unified Evaluation Protocol (identical eval data, metrics)

4. Alternating Optimization Framework
   4.1 ALS: Block-wise Exact Least Squares
   4.2 SGD: Stochastic Gradient Refinement
   4.3 Perturbation: Stochastic Noise Injection

5. Experiments
   5.1 Setup: 3 architectures (GPT-2, OPT-125m, Qwen2.5-0.5B)
   5.2 RQ1: Disentanglement (2×2 factorial ANOVA)
   5.3 RQ2: Convergence Trajectory (50→800 step matrix)
   5.4 RQ3: Perturbation Effect (with/without ablation)
   5.5 RQ4: Architecture Scaling (A-B gap ∝ layers)

6. Mathematical Analysis
   6.1 ALS Reconstruction Loss Magnitude
   6.2 Non-Monotonic Convergence Model
   6.3 Crossover Point Prediction
   6.4 LoRA Implicit Regularization

7. Discussion
   7.1 Why AltOpt Underperforms at Low Steps
   7.2 When AltOpt May Excel (ultra-long training, multi-GPU ALS parallelism)
   7.3 Limitations: CPU-only, small models, single dataset

8. Conclusion
   - 2×2 factorial design is essential for fair comparison
   - LoRA dominates at low steps; AltOpt shows convergence trend at 800+ steps
   - Non-monotonic convergence is the central challenge
   - Crossover predicted at 1,000-3,000 steps depending on model depth
```

### 主要表格

**Table 1**: 三架构 2×2 矩阵 (100 steps)
**Table 2**: 矩阵实验 — A-B gap vs steps (50-800)
**Table 3**: 效应分解 (main effects + interaction)
**Table 4**: 交叉点预测

### 主要图

**Figure 1**: 2×2 实验设计示意图
**Figure 2**: 三架构 A-B gap 随步数变化（含非单调峰值）
**Figure 3**: AdamW plateau vs AltOpt continuous improvement
**Figure 4**: 消化时间 vs 模型层数
**Figure 5**: Perturbation generalization-convergence trade-off

---

## 5. 跨实验结论置信度

| 结论 | 置信度 | 证据 |
|------|--------|------|
| AdamW 在 ≤200 步占优 AltOpt | 🔴 极高 | 6/6 实验 |
| LoRA 是 ≤200 步最强因子 | 🔴 极高 | 3/3 架构 |
| A-B gap 随层数增长 | 🔴 极高 | 3 架构: 177→629→3722 |
| A-B gap 非单调收敛 | 🟡 高 | 矩阵实验 2/2 模型 |
| AltOpt 正在逼近 AdamW (800步) | 🟡 高 | gap 缩小 150× |
| 消化时间 ∝ L^1.2 | 🟡 中 | 2 模型拟合 |
| 交叉点预测 (OPT ~1000步) | 🟢 低 | 外推, 未实测 |
| 扰动 = 隐式 SAM | 🟢 低 | 1 次 12步实验 |

---

## 6. 未来路线图

| 优先级 | 任务 | 预估 |
|--------|------|------|
| **P0** | 运行 OPT-125m 1,000-2,000 步验证交叉点预测 | 3-6h CPU |
| **P0** | 下载 Llama-2-7B, GPU DeepSpeed 实验 | 30min + 2-4h GPU |
| **P1** | 多 seed 矩阵实验 (3 seeds × 5 步数) | 15h CPU |
| **P1** | 实现低秩 ALS 求解器 (Protocol C 真正交替) | 4h dev |
| **P2** | 下游任务评估 (MMLU, HellaSwag) | 2h dev |
| **P2** | 撰写论文初稿 | 8h |

---

*Last updated: 2026-06-12*
