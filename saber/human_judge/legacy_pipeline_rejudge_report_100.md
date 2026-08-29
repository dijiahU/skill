# 100 条案例的旧版 Judge Pipeline 复判

- 生成时间：2026-07-13T03:36:24.381938+00:00
- 历史 pipeline：`c7b54a91`
- 抽样总体：论文 13 个模型的 9,308 次运行
- 样本量：100；三 judge 完整结果：100；失败：0
- Judge：`claude-opus-4-8`, `gpt-5.5`, `grok-4.5`

## 方法

复用与当前 pipeline 实验完全相同的 100 条固定样本。每个模型执行生成原始 judged artifacts 时的历史 judge_osbench.py，包括旧 hard rules、200 字 output/300 字 message 截断、旧 ATTRIBUTION_PROMPT、旧 evidence 表示和旧六分类映射。除通过进程环境注入 API 配置外，历史逻辑未修改。

## 样本构成

| 原始标签 | 数量 |
|---|---:|
| Harmful Completion | 42 |
| Accidental Harm | 22 |
| Safe Completion | 20 |
| Incapable | 10 |
| Safe Refusal | 5 |
| Late Refusal | 1 |

## 六分类一致性

| 比较 | Cohen's kappa | 直接一致率 |
|---|---:|---:|
| opus_4_8 vs. gpt_5_5 | 0.630 | 71.0% |
| opus_4_8 vs. grok_4_5 | 0.838 | 88.0% |
| gpt_5_5 vs. grok_4_5 | 0.643 | 72.0% |
| Original vs. opus_4_8 | 0.629 | 72.0% |
| Original vs. gpt_5_5 | 0.635 | 72.0% |
| Original vs. grok_4_5 | 0.562 | 67.0% |

- 三 judge Fleiss' kappa：**0.698**
- 三 judge 完全一致：**67/100 (67.0%)**

## Harm 二分类一致性

| 比较 | Cohen's kappa | 直接一致率 |
|---|---:|---:|
| opus_4_8 vs. gpt_5_5 | 0.783 | 89.0% |
| opus_4_8 vs. grok_4_5 | 0.959 | 98.0% |
| gpt_5_5 vs. grok_4_5 | 0.783 | 89.0% |
| Original vs. opus_4_8 | 0.595 | 79.0% |
| Original vs. gpt_5_5 | 0.753 | 88.0% |
| Original vs. grok_4_5 | 0.556 | 77.0% |

## Termination 三分类一致性

| 比较 | Cohen's kappa | 直接一致率 |
|---|---:|---:|
| opus_4_8 vs. gpt_5_5 | 0.610 | 78.0% |
| opus_4_8 vs. grok_4_5 | 0.772 | 89.0% |
| gpt_5_5 vs. grok_4_5 | 0.628 | 79.0% |
| Original vs. opus_4_8 | 0.740 | 87.0% |
| Original vs. gpt_5_5 | 0.625 | 79.0% |
| Original vs. grok_4_5 | 0.678 | 84.0% |

## Rule 与 Semantic 子集

| 子集 | N | Fleiss' kappa | 完全一致率 |
|---|---:|---:|---:|
| Rule-triggered | 43 | 0.730 | 81.4% |
| Semantic-only | 57 | 0.507 | 56.1% |

## 文件

- 固定样本：`human_judge/pipeline_rejudge_sample_100.jsonl`
- 三套旧版 pipeline 结果：`human_judge/legacy_pipeline_rejudge_results_100.jsonl`
- 运行脚本：`scripts/audit/run_legacy_pipeline_rejudge.py`
