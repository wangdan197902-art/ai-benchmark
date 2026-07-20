---
title: "Qwen2.5 32B vs Mistral Small 3：基准对比"
description: "详细对比 Qwen2.5 32B 与 Mistral Small 3 的基准表现、定价、上下文窗口与合规性。"
date: 2024-09-19
lastmod: 2024-09-19
draft: false
weight: 10
comparison_id: "qwen2-5-32b-vs-mistral-small-3"
models: ["qwen2-5-32b", "mistral-small-3"]
benchmarks: ["arc", "bbh", "gpqa", "gsm8k", "humaneval", "ifeval", "math", "mmlu", "musr", "winogrande"]
verdict: "See Editor's Take section."
tags: ["comparison", "alibaba", "mistral"]
---

# Qwen2.5 32B 对比 Mistral Small 3

## 模型概述

Qwen2.5 32B 与 Mistral Small 3 均为 AI 模型市场的重要选项。本页对比两者在基准、定价与合规性上的差异。

## 核心规格对比

| 厂商 | 发布日期 | 上下文窗口 | 许可证 |
|---------|-------------|----------------|---------|
| Alibaba / Mistral | 2024-09-19 / 2025-01-29 | 131K / 32K | Qwen License / Apache 2.0 |

## 基准测试表现

| 基准 | Qwen2.5 32B | Mistral Small 3 | 胜出 |
|------|------|------|--------|
| ARC | 93.9 | 91.8 | A |
| BBH (BIG-Bench Hard) | 76.8 | 71.3 | A |
| GPQA | 39.4 | 30.1 | A |
| GSM8K (Grade School Math 8K) | 76.3 | 79.6 | B |
| HumanEval | 68.0 | 74.4 | B |
| IFEval | 73.5 | 76.9 | B |
| MATH | 39.5 | 39.2 | Tie |
| MMLU (Massive Multitask Language Understanding) | 78.5 | 76.9 | A |
| MUSR | 54.9 | 46.0 | A |
| WinoGrande | 81.9 | 78.8 | A |

## 定价对比

| 输入 | 输出 | 缓存读取 | 缓存写入 |
|------|--------|-----------|-----------|
| — / — | — / — | — / — | — / — |

*每百万 token — A / B*

## 优势 & 劣势

### Qwen2.5 32B

- ✅ 可靠的通用模型。
- ⚠️ 闭源专有模型，不支持自托管。

### Mistral Small 3

- ✅ 可靠的通用模型。
- ⚠️ 闭源专有模型，不支持自托管。

## 编辑点评

Qwen2.5 32B 与 Mistral Small 3 各有侧重。建议根据具体场景（代码、长文本、视觉等）选择，参考上方基准与定价表。

## 常见问题

### 哪个模型在代码任务上更优？
参考 HumanEval 基准得分表，得分更高者更适合代码任务。

### 哪个模型价格更低？
参考上方的定价对比表，输入/输出价格更低者更具成本优势。

### 上下文窗口哪个更长？
参考核心规格对比表，上下文窗口更大的模型适合长文档处理。

## 参考文献

- [Qwen2.5 32B 文档地址](https://qwenlm.github.io/)
- [Mistral Small 3 文档地址](https://docs.mistral.ai/)
