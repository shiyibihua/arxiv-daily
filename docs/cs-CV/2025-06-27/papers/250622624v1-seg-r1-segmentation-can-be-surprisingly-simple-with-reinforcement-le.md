---
layout: default
title: Seg-R1: Segmentation Can Be Surprisingly Simple with Reinforcement Learning
---

# Seg-R1: Segmentation Can Be Surprisingly Simple with Reinforcement Learning

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2506.22624" class="toolbar-btn" target="_blank">📄 arXiv: 2506.22624v1</a>
  <a href="https://arxiv.org/pdf/2506.22624.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2506.22624v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2506.22624v1', 'Seg-R1: Segmentation Can Be Surprisingly Simple with Reinforcement Learning')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Zuyao You, Zuxuan Wu

**分类**: cs.CV

**发布日期**: 2025-06-27

---

## 💡 一句话要点

**提出Seg-R1以提升多模态模型的像素级理解能力**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)** **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `强化学习` `多模态模型` `前景分割` `伪装物体检测` `显著物体检测` `像素级理解` `群体相对策略优化`

## 📋 核心要点

1. 现有方法在前景分割任务中面临像素级理解能力不足的挑战，尤其是在伪装物体和显著物体检测方面。
2. 论文提出的Seg-R1通过强化学习优化LMM的像素级理解，利用生成提示引导分割过程，简化了传统分割方法。
3. Seg-R1在COD10K上实现了0.873的S-measure，并在零-shot任务中表现优异，超越了完全监督的模型，展现了良好的泛化能力。

## 📝 摘要（中文）

我们提出了Seg-R1，这是一个初步探索使用强化学习（RL）来增强大型多模态模型（LMM）在像素级理解和推理能力方面的研究。该方法专注于前景分割任务，特别是伪装物体检测（COD）和显著物体检测（SOD），使LMM能够以生成点和边界框提示的方式引导SAM2生成分割掩膜。我们在分割领域引入了群体相对策略优化（GRPO），通过精心设计的训练策略赋予LMM像素级理解能力。值得注意的是，Seg-R1在没有复杂模型修改的情况下，通过纯RL训练在COD10K上取得了0.873的S-measure，并展现出强大的开放世界泛化能力。尽管仅在前景分割图像-掩膜对上进行训练，Seg-R1在指代分割和推理分割任务上也取得了令人印象深刻的零-shot表现，分别在RefCOCOg测试上达到71.4的cIoU和ReasonSeg测试上达到56.7的gIoU，超越了在这些数据集上完全监督的模型。

## 🔬 方法详解

**问题定义**：本论文旨在解决前景分割任务中现有方法在像素级理解能力不足的问题，尤其是在伪装物体检测和显著物体检测中，传统方法往往依赖于复杂的模型结构和大量标注数据。

**核心思路**：Seg-R1的核心思路是通过强化学习（RL）来优化大型多模态模型（LMM），使其能够生成点和边界框提示，从而引导分割模型（如SAM2）生成分割掩膜。这种方法简化了传统的分割流程，降低了对复杂模型的依赖。

**技术框架**：Seg-R1的整体架构包括三个主要模块：首先，LMM通过生成提示来引导分割；其次，使用群体相对策略优化（GRPO）进行训练，以提升模型的像素级理解；最后，利用生成的提示与SAM2结合，输出最终的分割掩膜。

**关键创新**：Seg-R1的主要创新在于将强化学习引入分割领域，特别是通过GRPO策略优化，使得模型能够在没有复杂修改的情况下实现高效的像素级理解。这与传统方法的依赖于大量标注数据和复杂结构形成鲜明对比。

**关键设计**：在训练过程中，Seg-R1采用了精心设计的损失函数和参数设置，以确保模型在前景分割任务中的有效性。同时，模型的训练完全基于图像-掩膜对，未使用文本监督，展现出强大的零-shot能力。

## 📊 实验亮点

Seg-R1在COD10K数据集上实现了0.873的S-measure，展示了其在前景分割任务中的卓越性能。此外，该模型在零-shot任务中表现出色，RefCOCOg测试的cIoU达71.4，ReasonSeg测试的gIoU达56.7，均超越了完全监督的模型，体现了其强大的开放世界泛化能力。

## 🎯 应用场景

该研究的潜在应用领域包括计算机视觉中的物体检测、图像分割和自动驾驶等场景。通过提升多模态模型的像素级理解能力，Seg-R1能够在实际应用中实现更高效的图像处理和分析，具有广泛的实际价值和未来影响。

## 📄 摘要（原文）

> We present Seg-R1, a preliminary exploration of using reinforcement learning (RL) to enhance the pixel-level understanding and reasoning capabilities of large multimodal models (LMMs). Starting with foreground segmentation tasks, specifically camouflaged object detection (COD) and salient object detection (SOD), our approach enables the LMM to generate point and bounding box prompts in the next-token fashion, which are then used to guide SAM2 in producing segmentation masks. We introduce Group Relative Policy Optimization (GRPO) into the segmentation domain, equipping the LMM with pixel-level comprehension through a carefully designed training strategy. Notably, Seg-R1 achieves remarkable performance with purely RL-based training, achieving .873 S-measure on COD10K without complex model modification. Moreover, we found that pure RL training demonstrates strong open-world generalization. Despite being trained solely on foreground segmentation image-mask pairs without text supervision, Seg-R1 achieves impressive zero-shot performance on referring segmentation and reasoning segmentation tasks, with 71.4 cIoU on RefCOCOg test and 56.7 gIoU on ReasonSeg test, outperforming models fully supervised on these datasets.

