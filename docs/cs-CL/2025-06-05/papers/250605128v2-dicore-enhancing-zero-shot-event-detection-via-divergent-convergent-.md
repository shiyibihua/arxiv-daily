---
layout: default
title: DiCoRe: Enhancing Zero-shot Event Detection via Divergent-Convergent LLM Reasoning
---

# DiCoRe: Enhancing Zero-shot Event Detection via Divergent-Convergent LLM Reasoning

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2506.05128" class="toolbar-btn" target="_blank">📄 arXiv: 2506.05128v2</a>
  <a href="https://arxiv.org/pdf/2506.05128.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2506.05128v2" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2506.05128v2', 'DiCoRe: Enhancing Zero-shot Event Detection via Divergent-Convergent LLM Reasoning')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Tanmay Parekh, Kartik Mehta, Ninareh Mehrabi, Kai-Wei Chang, Nanyun Peng

**分类**: cs.CL, cs.AI, cs.LG

**发布日期**: 2025-06-05 (更新: 2025-09-18)

**备注**: Accepted at EMNLP 2025 Main

---

## 💡 一句话要点

**提出DiCoRe框架以增强零样本事件检测能力**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)** **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `零样本学习` `事件检测` `大型语言模型` `推理框架` `自然语言处理`

## 📋 核心要点

1. 现有的零样本事件检测方法在处理复杂事件本体和领域特定触发词时存在显著局限，影响了其在专业领域的应用。
2. DiCoRe框架通过分歧推理和收敛推理的结合，分别实现开放式事件发现和任务特定指令的对齐，从而提升事件检测的效果。
3. 在六个数据集的实验中，DiCoRe在F1得分上比最佳基线提高了4-7%，显示出其在零样本事件检测中的强大能力。

## 📝 摘要（中文）

零样本事件检测（ED）是指在没有任何训练数据的情况下识别自然语言文本中的事件提及，这对于专业领域的文档理解至关重要。现有的大型语言模型（LLMs）在处理复杂事件本体、提取领域特定触发词和结构化信息时存在局限性。为此，本文提出了DiCoRe，一个分歧-收敛推理框架，通过Dreamer和Grounder解耦ED任务。Dreamer促进开放式事件发现以增强事件覆盖，而Grounder则通过有限状态机引导的约束解码将自由形式的预测与任务特定指令对齐。此外，LLM-Judge对最终输出进行验证，以确保高精度。通过在六个数据集和五个领域的广泛实验，DiCoRe在零样本、迁移学习和推理基线中表现出色，平均F1得分比最佳基线提高4-7%。

## 🔬 方法详解

**问题定义**：本文旨在解决零样本事件检测中的关键问题，即如何在没有训练数据的情况下有效识别和分类事件提及。现有方法在复杂事件本体的理解和领域特定触发词的提取上存在不足，限制了大型语言模型的应用效果。

**核心思路**：DiCoRe框架的核心思路是通过分歧-收敛推理的方式，分别实现开放式事件发现和任务特定指令的对齐。分歧推理通过Dreamer模块鼓励多样化的事件发现，而收敛推理通过Grounder模块确保预测结果符合特定任务要求。

**技术框架**：DiCoRe的整体架构包括两个主要模块：Dreamer和Grounder。Dreamer负责生成多样化的事件提及，而Grounder则通过有限状态机引导的约束解码将这些提及与任务指令对齐。最后，LLM-Judge模块对输出结果进行验证，确保高精度。

**关键创新**：DiCoRe的主要创新在于其分歧-收敛推理框架的设计，能够有效地将事件发现与任务指令对齐，显著提升了零样本事件检测的性能。这一方法与传统的单一推理方式有本质区别。

**关键设计**：在设计中，DiCoRe使用了有限状态机来引导解码过程，并通过特定的损失函数来优化模型性能。此外，模型的参数设置经过精细调优，以确保在不同领域和数据集上的适应性和有效性。

## 📊 实验亮点

DiCoRe在六个数据集上的实验结果显示，平均F1得分比最佳基线提高了4-7%，在零样本、迁移学习和推理基线中均表现出色，验证了其作为强大零样本事件检测框架的有效性。

## 🎯 应用场景

该研究的潜在应用领域包括新闻分析、社交媒体监控和法律文档处理等专业领域，能够帮助自动化识别和分类事件提及，提高文档理解的效率和准确性。未来，DiCoRe框架有望在更多复杂场景中应用，推动零样本学习技术的发展。

## 📄 摘要（原文）

> Zero-shot Event Detection (ED), the task of identifying event mentions in natural language text without any training data, is critical for document understanding in specialized domains. Understanding the complex event ontology, extracting domain-specific triggers from the passage, and structuring them appropriately overloads and limits the utility of Large Language Models (LLMs) for zero-shot ED. To this end, we propose DiCoRe, a divergent-convergent reasoning framework that decouples the task of ED using Dreamer and Grounder. Dreamer encourages divergent reasoning through open-ended event discovery, which helps to boost event coverage. Conversely, Grounder introduces convergent reasoning to align the free-form predictions with the task-specific instructions using finite-state machine guided constrained decoding. Additionally, an LLM-Judge verifies the final outputs to ensure high precision. Through extensive experiments on six datasets across five domains and nine LLMs, we demonstrate how DiCoRe consistently outperforms prior zero-shot, transfer-learning, and reasoning baselines, achieving 4-7% average F1 gains over the best baseline -- establishing DiCoRe as a strong zero-shot ED framework.

