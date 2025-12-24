---
layout: default
title: CAST: Counterfactual Labels Improve Instruction Following in Vision-Language-Action Models
---

# CAST: Counterfactual Labels Improve Instruction Following in Vision-Language-Action Models

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2508.13446" class="toolbar-btn" target="_blank">📄 arXiv: 2508.13446v1</a>
  <a href="https://arxiv.org/pdf/2508.13446.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2508.13446v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2508.13446v1', 'CAST: Counterfactual Labels Improve Instruction Following in Vision-Language-Action Models')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Catherine Glossop, William Chen, Arjun Bhorkar, Dhruv Shah, Sergey Levine

**分类**: cs.RO

**发布日期**: 2025-08-19

---

## 💡 一句话要点

**提出反事实标签以提升视觉语言行动模型的指令跟随能力**

🎯 **匹配领域**: **支柱三：空间感知与语义 (Perception & Semantics)** **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `视觉语言模型` `反事实学习` `指令跟随` `机器人技术` `数据增强` `多模态学习`

## 📋 核心要点

1. 现有的视觉语言行动模型在执行细粒度指令时表现不佳，主要由于缺乏语义多样性和语言基础。
2. 本文提出了一种利用视觉语言模型生成反事实标签的方法，以增强机器人数据集的语言多样性和细粒度。
3. 实验表明，反事实重标记在不增加数据收集的情况下，显著提升了指令跟随能力，使模型与最先进的方法相竞争。

## 📝 摘要（中文）

通用机器人应能够理解和执行用户指令，但现有的视觉语言行动（VLA）模型在跟随细粒度命令方面存在困难。主要原因在于现有机器人数据集中缺乏语义多样性和语言基础，尤其是在相似观察下缺乏细粒度任务多样性。为了解决这一问题，本文提出了一种新方法，通过利用视觉语言模型生成反事实标签来增强现有机器人数据集。这种方法通过生成反事实语言和动作，提高了机器人数据集的语言基础的多样性和细粒度，从而改善了VLA的指令跟随能力。实验结果表明，反事实重标记显著提高了VLA策略的指令跟随能力，使其在导航任务中的成功率提高了27%。

## 🔬 方法详解

**问题定义**：本文旨在解决现有视觉语言行动模型在跟随细粒度用户指令时的不足，特别是由于缺乏多样化的训练数据导致的性能瓶颈。

**核心思路**：通过生成反事实标签，增强现有机器人数据集的语言基础和任务多样性，从而提高模型的指令跟随能力。该方法利用视觉语言模型生成与原始指令相对的语言和动作，以丰富训练数据。

**技术框架**：整体架构包括数据集增强模块和模型训练模块。首先，通过视觉语言模型生成反事实标签，然后将这些标签与原始数据结合，训练VLA模型以提高其指令跟随能力。

**关键创新**：最重要的创新在于反事实重标记技术，它通过生成与原始指令相对的语言和动作，显著提高了模型的语言理解和执行能力。这一方法与传统的数据增强技术有本质区别。

**关键设计**：在参数设置上，采用了特定的损失函数来平衡原始和反事实标签的影响。此外，网络结构上结合了视觉和语言特征的融合模块，以提升模型的整体性能。实验中还对反事实生成的质量进行了严格评估，以确保其有效性。

## 📊 实验亮点

实验结果显示，反事实重标记技术在不增加额外数据收集的情况下，显著提升了VLA模型的指令跟随能力，导航任务的成功率提高了27%。这一提升使得模型的性能与当前最先进的方法相当，展示了该方法的有效性。

## 🎯 应用场景

该研究的潜在应用领域包括服务机器人、家庭自动化和工业自动化等场景。通过提升机器人对复杂指令的理解和执行能力，可以大幅提高其在实际应用中的效率和灵活性，未来可能推动智能机器人在更多领域的广泛应用。

## 📄 摘要（原文）

> Generalist robots should be able to understand and follow user instructions, but current vision-language-action (VLA) models struggle with following fine-grained commands despite providing a powerful architecture for mapping open-vocabulary natural language instructions to robot actions. One cause for this is a lack of semantic diversity and language grounding in existing robot datasets and, specifically, a lack of fine-grained task diversity for similar observations. To address this, we present a novel method to augment existing robot datasets by leveraging vision language models to create counterfactual labels. Our method improves the language-following capabilities of VLAs by increasing the diversity and granularity of language grounding for robot datasets by generating counterfactual language and actions. We evaluate the resulting model's ability to follow language instructions, ranging from simple object-centric commands to complex referential tasks, by conducting visual language navigation experiments in 3 different indoor and outdoor environments. Our experiments demonstrate that counterfactual relabeling, without any additional data collection, significantly improves instruction-following in VLA policies, making them competitive with state-of-the-art methods and increasing success rate by 27% on navigation tasks.

