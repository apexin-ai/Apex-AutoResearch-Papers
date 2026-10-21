# fix c4 analysis correction

**Characterizing the Detectability Landscape of Iterative Model Collapse** · Conversation logs

This page is a human-readable rendering of one source record. It preserves the recorded order and wording; the linked JSON keeps the complete machine-readable structure.

## Record overview

- **Events:** 13
- **Recorded user turns:** 0
- **Tool calls:** 6
- **Original source:** `logs/chats/worker_fix_c4_analysis_correction_20260518T211617.jsonl`
- **Structured JSON:** [`ce01670a11f8915cf232.json`](../../sessions/ce/ce01670a11f8915cf232.json)

## How to read this transcript

`User` marks a recorded user-role instruction, `Assistant` marks an agent response, and the collapsible `Tool call` / `Tool result` blocks show the actions and observations between them. A user-role record may come from another agent or the runtime system; it is not an authorship label.

## Before a recorded user message

13 recorded events

### Tool call

_source line 1 · 2026-05-18T21:17:37.754030+00:00_

called Glob

<details open><summary>🔧 Tool call — Glob</summary>

```json
{
  "pattern": "**/*c4*",
  "path": "/home/ubuntu/.agent-ml-research-idea_gen_0514_4/projects/distrib_canary_collapse/artifacts"
}
```

</details>

<details><summary>Recorded metadata</summary>

```json
{
  "recorded_role": "tool",
  "session": "worker_fix_c4_analysis_correction_20260518T211617",
  "tool": "Glob",
  "tool_args": {
    "pattern": "**/*c4*",
    "path": "/home/ubuntu/.agent-ml-research-idea_gen_0514_4/projects/distrib_canary_collapse/artifacts"
  }
}
```

</details>

---

### Tool result

_source line 2 · 2026-05-18T21:17:37.754328+00:00_

artifacts/prep_c4_gpt2m_readiness.md
artifacts/generalize_pythia1b_c4_a100_s43/report/analysis_pythia1b_c4_s43.md
artifacts/c4_vs_wikitext_a050_collapse.md

<details><summary>Recorded metadata</summary>

```json
{
  "recorded_role": "tool_result",
  "session": "worker_fix_c4_analysis_correction_20260518T211617",
  "tool": "Glob",
  "elapsed_ms": 0
}
```

</details>

---

### Tool call

_source line 3 · 2026-05-18T21:17:37.754532+00:00_

called Glob

<details open><summary>🔧 Tool call — Glob</summary>

```json
{
  "pattern": "**/*comparison*",
  "path": "/home/ubuntu/.agent-ml-research-idea_gen_0514_4/projects/distrib_canary_collapse/artifacts"
}
```

</details>

<details><summary>Recorded metadata</summary>

```json
{
  "recorded_role": "tool",
  "session": "worker_fix_c4_analysis_correction_20260518T211617",
  "tool": "Glob",
  "tool_args": {
    "pattern": "**/*comparison*",
    "path": "/home/ubuntu/.agent-ml-research-idea_gen_0514_4/projects/distrib_canary_collapse/artifacts"
  }
}
```

</details>

---

### Tool result

_source line 4 · 2026-05-18T21:17:37.754685+00:00_

No files found

<details><summary>Recorded metadata</summary>

```json
{
  "recorded_role": "tool_result",
  "session": "worker_fix_c4_analysis_correction_20260518T211617",
  "tool": "Glob",
  "elapsed_ms": 0
}
```

</details>

---

### Tool call

_source line 5 · 2026-05-18T21:17:37.754806+00:00_

called ToolSearch

<details open><summary>🔧 Tool call — ToolSearch</summary>

```json
{
  "query": "select:mcp__agent-ml-research__ssh_read_only,mcp__agent-ml-research__register_artifact,mcp__agent-ml-research__save_project_file",
  "max_results": "3"
}
```

</details>

<details><summary>Recorded metadata</summary>

```json
{
  "recorded_role": "tool",
  "session": "worker_fix_c4_analysis_correction_20260518T211617",
  "tool": "ToolSearch",
  "tool_args": {
    "query": "select:mcp__agent-ml-research__ssh_read_only,mcp__agent-ml-research__register_artifact,mcp__agent-ml-research__save_project_file",
    "max_results": "3"
  }
}
```

</details>

---

### Tool result

_source line 6 · 2026-05-18T21:17:37.754934+00:00_



<details><summary>Recorded metadata</summary>

```json
{
  "recorded_role": "tool_result",
  "session": "worker_fix_c4_analysis_correction_20260518T211617",
  "tool": "ToolSearch",
  "elapsed_ms": 0
}
```

</details>

---

### Tool call

_source line 7 · 2026-05-18T21:17:37.755054+00:00_

called Read

<details open><summary>🔧 Tool call — Read</summary>

```json
{
  "file_path": "/home/ubuntu/.agent-ml-research-idea_gen_0514_4/projects/distrib_canary_collapse/artifacts/c4_vs_wikitext_a050_collapse.md"
}
```

</details>

<details><summary>Recorded metadata</summary>

```json
{
  "recorded_role": "tool",
  "session": "worker_fix_c4_analysis_correction_20260518T211617",
  "tool": "Read",
  "tool_args": {
    "file_path": "/home/ubuntu/.agent-ml-research-idea_gen_0514_4/projects/distrib_canary_collapse/artifacts/c4_vs_wikitext_a050_collapse.md"
  }
}
```

</details>

---

### Tool result

_source line 8 · 2026-05-18T21:17:37.755194+00:00_

1	# C4 vs WikiText α=0.50 Collapse 对比分析
2	
3	## 实验配置
4	
5	| 参数 | C4 (a050_s42_bf16) | WikiText (a050_s42) |
6	|------|-------------------|---------------------|
7	| 模型 | pythia-410m | pythia-410m |
8	| α (synthetic_ratio) | 0.50 | 0.50 |
9	| steps_per_gen | 5,000 | 5,000 |
10	| batch_size | 4 | 4 |
11	| lr | 5e-5 | 5e-5 |
12	| bf16 | yes | no (fp32) |
13	| **训练样本数** | **4,500** | **716,506** |
14	| 样本平均长度 | ~2,499 chars | ~768 chars |
15	| **每代 epochs** | **~4.4** | **~0.028** |
16	
17	## 逐代指标对比
18	
19	### Token Entropy
20	
21	| Gen | C4 | WikiText | C4 Δ% | Wiki Δ% |
22	|-----|------|----------|--------|---------|
23	| 0 | 3.136 | 3.234 | - | - |
24	| 1 | 2.779 | 2.517 | -11.4 | -22.2 |
25	| 2 | 2.600 | 2.498 | -17.1 | -22.7 |
26	| 3 | 2.460 | 2.564 | -21.6 | -20.7 |
27	| 4 | 2.353 | 2.549 | -25.0 | -21.2 |
28	| 5 | 2.274 | 2.546 | -27.5 | -21.3 |
29	| 6 | 2.185 | 2.567 | -30.3 | -20.6 |
30	| 7 | 2.114 | 2.608 | -32.6 | -19.4 |
31	| 8 | 2.048 | 2.611 | -34.7 | -19.3 |
32	| 9 | 1.995 | 2.633 | -36.4 | -18.6 |
33	| 10 | 1.940 | 2.632 | **-38.2** | **-18.6** |
34	
35	### Perplexity
36	
37	| Gen | C4 | WikiText | C4 Δ% | Wiki Δ% |
38	|-----|-------|----------|--------|---------|
39	| 0 | 24.4 | 26.9 | - | - |
40	| 1 | 27.0 | 23.0 | +10.6 | -14.8 |
41	| 2 | 32.6 | 26.4 | +33.5 | -2.1 |
42	| 3 | 40.2 | 27.5 | +64.5 | +2.0 |
43	| 4 | 49.2 | 28.7 | +101.1 | +6.5 |
44	| 5 | 59.0 | 29.9 | +141.4 | +11.1 |
45	| 6 | 69.5 | 30.2 | +184.3 | +12.0 |
46	| 7 | 81.0 | 30.8 | +231.5 | +14.2 |
47	| 8 | 94.2 | 31.6 | +285.6 | +17.2 |
48	| 9 | 107.9 | 32.1 | +341.5 | +19.1 |
49	| 10 | 122.8 | 32.6 | **+402.4** | **+21.1** |
50	
51	### Lexical Diversity (Distinct-N)
52	
53	| Gen | C4 d1 | Wiki d1 | C4 d2 | Wiki d2 | C4 d3 | Wiki d3 |
54	|-----|-------|---------|-------|---------|-------|---------|
55	| 0 | 0.111 | 0.098 | 0.562 | 0.518 | 0.873 | 0.813 |
56	| 5 | 0.094 | 0.067 | 0.466 | 0.309 | 0.784 | 0.505 |
57	| 10 | 0.089 | 0.062 | 0.424 | 0.251 | 0.686 | 0.387 |
58	| **Δ%** | **-20.4
…[truncated 1623 chars]

<details><summary>Recorded metadata</summary>

```json
{
  "recorded_role": "tool_result",
  "session": "worker_fix_c4_analysis_correction_20260518T211617",
  "tool": "Read",
  "elapsed_ms": 0
}
```

</details>

---

### Tool call

_source line 9 · 2026-05-18T21:17:37.755429+00:00_

called Edit

<details open><summary>🔧 Tool call — Edit</summary>

```json
{
  "replace_all": "False",
  "file_path": "/home/ubuntu/.agent-ml-research-idea_gen_0514_4/projects/distrib_canary_collapse/artifacts/c4_vs_wikitext_a050_collapse.md",
  "old_string": "## 分析\n\n### 1. 根因：数据量级差异导致过拟合程度不同\n\nC4 仅 4,500 样本，每代训练 5000 steps × batch_size 4 = 20,000 次采样，相当于 **~4.4 epochs/gen**。WikiText 有 716,506 样本，同样配置下仅 **~0.028 epochs/gen**。C4 每代严重过拟合，模型置信度逐代堆积，entropy 单调下降（3.14→1.94）。WikiText 数据充足，entropy 在 gen2 后稳定在 ~2.55-2.63。\n\n### 2. 两种不同的 collapse 模式\n\n- **C4: confidence collapse**。过拟合使模型对训练分布极度自信，entropy 持续下降，但泛化能力崩溃（perplexity +402%，ECE 从 0.011 到 0.258）。词汇多样性反而保持相对较好（distinct_2 仅 -24.6%），因为模型在小数据集上记住了足够多的 n-gram 模式。\n\n- **WikiText: diversity collapse**。数据充足避免了过拟合，perplexity 基本稳定（+21%）。但迭代合成数据逐代削减词汇多样性（distinct_2 -51.5%，distinct_3 -52.4%），模型学会偏好高频模式而放弃低频表达。\n\n### 3. MAUVE 基线差异\n\nWikiText gen0 MAUVE 仅 0.034（C4 为 0.691），说明 WikiText 的合成文本分布从一开始就与真实数据差异较大。这可能源于 WikiText 包含大量短文本/空行/标题行，使得合成分布与原始分布的匹配天然困难。C4 经过清洗，文本质量更均匀，初始 MAUVE 更高，但也意味着有更大的下降空间。\n\n### 4. bf16 vs fp32 的混淆因素\n\nC4 实验使用 bf16，WikiText 使用默认 fp32。bf16 的精度损失可能在多代迭代中累积放大误差，但这不太可能是主因（entropy -38% 的量级无法仅由精度差异解释）。\n\n### 结论\n\nC4 α=0.50 的剧烈 collapse 主要由 **数据量不足导致的过拟合放大效应** 驱动。4,500 样本在 5000-step 训练下每代过拟合 ~4.4 epochs，模型置信度逐代堆积。若要公平对比，需控制 epochs/gen 一致，或将 C4 数据量扩充到与 WikiText 同量级。",
  "new_string": "## 分析\n\n> **Baseline 说明**：gen0 指标是各数据集的 baseline 参考值，所有 drift 均相对 gen0 计算。C4 数据集本身包含 4,500 samples，WikiText 包含 716,506 samples（159x 差异）。4,500 是 C4 的原始数据量，不是退化或暴跌的结果。\n>\n> **bf16 Confound（D078）**：C4 实验 (alpha_sweep_c4_a050_s42_bf16) 使用 bf16 训练，其他 α sweep 实验（如 alpha_sweep_a050_s42）使用 fp32。因此 **ppl 绝对值不可直接跨数据集比较**。Drift 百分比和指标排序不受 bf16 影响。\n\n### 1. 根因：数据集规模差异导致每代过拟合程度不同\n\nC4 包含 4,500 samples，WikiText 包含 716,506 samples。在相同训练配置下（5000 steps, batch_size 4），C4 每代等效 **~4.4 epochs**，WikiText 每代等效 **~0.028 epochs**。这一 159x 的数据量差异导致 C4 每代过拟合远重于 WikiText，进而在多代迭代中产生不同的 collapse 轨迹。\n\n### 2. 两种不同的 collapse 模式\n\n- **C4: confidence collapse**。高 epochs/gen 使模型对训练分布过度自信，entropy 从 gen0 到 gen10 单调下降（3.14→1.94, -38.2%），泛化能力逐代退化（ppl drift +402%，ECE 从 0.011→0.258）。词汇多样性保持相对较好（distinct_2 drift -24.6%），因为模型在反复过拟合中记住了 n-gram 模式。\n\n- **WikiText: diversity collapse**。低 epochs/gen 避免了严重过拟合，ppl drift 温和（+21.1%）。但迭代合成数据逐代削减词汇多样性（distinct_2 drift -51.5%，distinct_3 drift -52.4%），模型偏好高频模式而放弃低频表达。\n\n### 3. MAUVE baseline 差异\n\nWikiText gen0 MAUVE 为 0.034（C4 gen0 为 0.691）。这是两个数据集的 baseline 特征差异：WikiText 包含大量短文本、空行、标题行，合成文本分布与原始分布的匹配天然困难；C4 经过清洗，文本质量更均匀，baseline MAUVE 更高。两者的 MAUVE drift 方向一致（均下降），但起点不同。\n\n### 4. bf16 vs fp32 混淆因素\n\nC4 实验使用 bf16，WikiText 使用 fp32。**ppl 绝对值不可直接跨实验比较**（D078 决策）。bf16 精度损失可能在多代迭代中累积，但 entropy drift -38.2% 的量级无法仅由精度差异解释，因此 bf16 不改变 collapse 模式的定性结论。Drift 百分比和指标排序不受影响。\n\n### 结论\n\nC4 与 WikiText 在 α=0.50 下展现不同 collapse 模式，根因是 **数据集规模差异（4,500 vs 716,506）导致的每代过拟合程度不同**：C4 的 4.4 epochs/gen 驱动 confidence collapse（entropy 单调下降 + ppl 爆炸），WikiText 的 0.028 epochs/gen 驱动 diversity collapse（词汇多样性大幅下降 + ppl 温和上升）。若要控制变量对比，需统一 epochs/gen 或数据量级。注意 ppl 绝对值受 bf16 confound 影响，不可直接比较。"
}
```

</details>

<details><summary>Recorded metadata</summary>

```json
{
  "recorded_role": "tool",
  "session": "worker_fix_c4_analysis_correction_20260518T211617",
  "tool": "Edit",
  "tool_args": {
    "replace_all": "False",
    "file_path": "/home/ubuntu/.agent-ml-research-idea_gen_0514_4/projects/distrib_canary_collapse/artifacts/c4_vs_wikitext_a050_collapse.md",
    "old_string": "## 分析\n\n### 1. 根因：数据量级差异导致过拟合程度不同\n\nC4 仅 4,500 样本，每代训练 5000 steps × batch_size 4 = 20,000 次采样，相当于 **~4.4 epochs/gen**。WikiText 有 716,506 样本，同样配置下仅 **~0.028 epochs/gen**。C4 每代严重过拟合，模型置信度逐代堆积，entropy 单调下降（3.14→1.94）。WikiText 数据充足，entropy 在 gen2 后稳定在 ~2.55-2.63。\n\n### 2. 两种不同的 collapse 模式\n\n- **C4: confidence collapse**。过拟合使模型对训练分布极度自信，entropy 持续下降，但泛化能力崩溃（perplexity +402%，ECE 从 0.011 到 0.258）。词汇多样性反而保持相对较好（distinct_2 仅 -24.6%），因为模型在小数据集上记住了足够多的 n-gram 模式。\n\n- **WikiText: diversity collapse**。数据充足避免了过拟合，perplexity 基本稳定（+21%）。但迭代合成数据逐代削减词汇多样性（distinct_2 -51.5%，distinct_3 -52.4%），模型学会偏好高频模式而放弃低频表达。\n\n### 3. MAUVE 基线差异\n\nWikiText gen0 MAUVE 仅 0.034（C4 为 0.691），说明 WikiText 的合成文本分布从一开始就与真实数据差异较大。这可能源于 WikiText 包含大量短文本/空行/标题行，使得合成分布与原始分布的匹配天然困难。C4 经过清洗，文本质量更均匀，初始 MAUVE 更高，但也意味着有更大的下降空间。\n\n### 4. bf16 vs fp32 的混淆因素\n\nC4 实验使用 bf16，WikiText 使用默认 fp32。bf16 的精度损失可能在多代迭代中累积放大误差，但这不太可能是主因（entropy -38% 的量级无法仅由精度差异解释）。\n\n### 结论\n\nC4 α=0.50 的剧烈 collapse 主要由 **数据量不足导致的过拟合放大效应** 驱动。4,500 样本在 5000-step 训练下每代过拟合 ~4.4 epochs，模型置信度逐代堆积。若要公平对比，需控制 epochs/gen 一致，或将 C4 数据量扩充到与 WikiText 同量级。",
    "new_string": "## 分析\n\n> **Baseline 说明**：gen0 指标是各数据集的 baseline 参考值，所有 drift 均相对 gen0 计算。C4 数据集本身包含 4,500 samples，WikiText 包含 716,506 samples（159x 差异）。4,500 是 C4 的原始数据量，不是退化或暴跌的结果。\n>\n> **bf16 Confound（D078）**：C4 实验 (alpha_sweep_c4_a050_s42_bf16) 使用 bf16 训练，其他 α sweep 实验（如 alpha_sweep_a050_s42）使用 fp32。因此 **ppl 绝对值不可直接跨数据集比较**。Drift 百分比和指标排序不受 bf16 影响。\n\n### 1. 根因：数据集规模差异导致每代过拟合程度不同\n\nC4 包含 4,500 samples，WikiText 包含 716,506 samples。在相同训练配置下（5000 steps, batch_size 4），C4 每代等效 **~4.4 epochs**，WikiText 每代等效 **~0.028 epochs**。这一 159x 的数据量差异导致 C4 每代过拟合远重于 WikiText，进而在多代迭代中产生不同的 collapse 轨迹。\n\n### 2. 两种不同的 collapse 模式\n\n- **C4: confidence collapse**。高 epochs/gen 使模型对训练分布过度自信，entropy 从 gen0 到 gen10 单调下降（3.14→1.94, -38.2%），泛化能力逐代退化（ppl drift +402%，ECE 从 0.011→0.258）。词汇多样性保持相对较好（distinct_2 drift -24.6%），因为模型在反复过拟合中记住了 n-gram 模式。\n\n- **WikiText: diversity collapse**。低 epochs/gen 避免了严重过拟合，ppl drift 温和（+21.1%）。但迭代合成数据逐代削减词汇多样性（distinct_2 drift -51.5%，distinct_3 drift -52.4%），模型偏好高频模式而放弃低频表达。\n\n### 3. MAUVE baseline 差异\n\nWikiText gen0 MAUVE 为 0.034（C4 gen0 为 0.691）。这是两个数据集的 baseline 特征差异：WikiText 包含大量短文本、空行、标题行，合成文本分布与原始分布的匹配天然困难；C4 经过清洗，文本质量更均匀，baseline MAUVE 更高。两者的 MAUVE drift 方向一致（均下降），但起点不同。\n\n### 4. bf16 vs fp32 混淆因素\n\nC4 实验使用 bf16，WikiText 使用 fp32。**ppl 绝对值不可直接跨实验比较**（D078 决策）。bf16 精度损失可能在多代迭代中累积，但 entropy drift -38.2% 的量级无法仅由精度差异解释，因此 bf16 不改变 collapse 模式的定性结论。Drift 百分比和指标排序不受影响。\n\n### 结论\n\nC4 与 WikiText 在 α=0.50 下展现不同 collapse 模式，根因是 **数据集规模差异（4,500 vs 716,506）导致的每代过拟合程度不同**：C4 的 4.4 epochs/gen 驱动 confidence collapse（entropy 单调下降 + ppl 爆炸），WikiText 的 0.028 epochs/gen 驱动 diversity collapse（词汇多样性大幅下降 + ppl 温和上升）。若要控制变量对比，需统一 epochs/gen 或数据量级。注意 ppl 绝对值受 bf16 confound 影响，不可直接比较。"
  }
}
```

</details>

---

### Tool result

_source line 10 · 2026-05-18T21:17:37.755632+00:00_

The file /home/ubuntu/.agent-ml-research-idea_gen_0514_4/projects/distrib_canary_collapse/artifacts/c4_vs_wikitext_a050_collapse.md has been updated successfully.

<details><summary>Recorded metadata</summary>

```json
{
  "recorded_role": "tool_result",
  "session": "worker_fix_c4_analysis_correction_20260518T211617",
  "tool": "Edit",
  "elapsed_ms": 0
}
```

</details>

---

### Tool call

_source line 11 · 2026-05-18T21:17:37.755775+00:00_

called mcp__agent-ml-research__register_artifact

<details open><summary>🔧 Tool call — mcp__agent-ml-research__register_artifact</summary>

```json
{
  "name": "c4_vs_wikitext_a050_collapse",
  "type": "report",
  "description": "C4 vs WikiText α=0.50 collapse 对比分析（v3 修正：澄清 4500 为 C4 baseline 数据量而非 gen0 暴跌；标注 bf16 confound per D078；明确 gen0=baseline 所有 drift 相对 gen0 计算）",
  "project": "distrib_canary_collapse",
  "source_path": "/home/ubuntu/.agent-ml-research-idea_gen_0514_4/projects/distrib_canary_collapse/artifacts/c4_vs_wikitext_a050_collapse.md",
  "tags": "['c4', 'wikitext', 'collapse', 'alpha_sweep', 'bf16_confound']"
}
```

</details>

<details><summary>Recorded metadata</summary>

```json
{
  "recorded_role": "tool",
  "session": "worker_fix_c4_analysis_correction_20260518T211617",
  "tool": "mcp__agent-ml-research__register_artifact",
  "tool_args": {
    "name": "c4_vs_wikitext_a050_collapse",
    "type": "report",
    "description": "C4 vs WikiText α=0.50 collapse 对比分析（v3 修正：澄清 4500 为 C4 baseline 数据量而非 gen0 暴跌；标注 bf16 confound per D078；明确 gen0=baseline 所有 drift 相对 gen0 计算）",
    "project": "distrib_canary_collapse",
    "source_path": "/home/ubuntu/.agent-ml-research-idea_gen_0514_4/projects/distrib_canary_collapse/artifacts/c4_vs_wikitext_a050_collapse.md",
    "tags": "['c4', 'wikitext', 'collapse', 'alpha_sweep', 'bf16_confound']"
  }
}
```

</details>

---

### Tool result

_source line 12 · 2026-05-18T21:17:37.755949+00:00_

{"result":"{\"success\": true, \"data\": {\"artifact\": {\"id\": \"art_20260518_5d0b10\", \"name\": \"c4_vs_wikitext_a050_collapse\", \"type\": \"report\", \"description\": \"C4 vs WikiText α=0.50 collapse 对比分析（v3 修正：澄清 4500 为 C4 baseline 数据量而非 gen0 暴跌；标注 bf16 confound per D078；明确 gen0=baseline 所有 drift 相对 gen0 计算）\", \"path\": \"projects/distrib_canary_collapse/artifacts/_project/report/c4_vs_wikitext_a050_collapse.md\", \"url\": null, \"project\": \"distrib_canary_collapse\", \"exp_id\": null, \"skill\": \"\", \"created_at\": \"2026-05-18T21:17:29.684986+00:00\", \"tags\": [\"c4\", \"wikitext\", \"collapse\", \"alpha_sweep\", \"bf16_confound\"]}, \"manifest\": \"/home/ubuntu/.agent-ml-research-idea_gen_0514_4/projects/distrib_canary_collapse/artifacts/manifest.yaml\"}, \"error\": null, \"metadata\": {}}"}

<details><summary>Recorded metadata</summary>

```json
{
  "recorded_role": "tool_result",
  "session": "worker_fix_c4_analysis_correction_20260518T211617",
  "tool": "mcp__agent-ml-research__register_artifact",
  "elapsed_ms": 0
}
```

</details>

---

### Assistant

_source line 13 · 2026-05-18T21:17:37.756114+00:00_

修正完成。变更摘要：

1. **移除"仅 4,500 样本"的缺陷暗示** — 改为明确说明 4,500 是 C4 的原始数据量，不是退化结果
2. **新增 Baseline 说明块** — 开头声明 gen0 = baseline，所有 drift 相对 gen0 计算
3. **bf16 Confound 标注（D078）** — 在分析开头和结论中均标注 ppl 绝对值不可跨实验直接比较，drift 百分比和排序不受影响
4. **结论重写** — 根因从"数据量不足"改为"数据集规模差异导致每代过拟合程度不同"，去除"需扩充 C4 数据量"的误导性建议

<details><summary>Recorded metadata</summary>

```json
{
  "recorded_role": "assistant",
  "session": "worker_fix_c4_analysis_correction_20260518T211617"
}
```

</details>

---
