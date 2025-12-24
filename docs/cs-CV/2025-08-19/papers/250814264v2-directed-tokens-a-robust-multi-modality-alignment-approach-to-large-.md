---
layout: default
title: Directed-Tokens: A Robust Multi-Modality Alignment Approach to Large Language-Vision Models
---

# Directed-Tokens: A Robust Multi-Modality Alignment Approach to Large Language-Vision Models

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2508.14264" class="toolbar-btn" target="_blank">📄 arXiv: 2508.14264v2</a>
  <a href="https://arxiv.org/pdf/2508.14264.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2508.14264v2" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2508.14264v2', 'Directed-Tokens: A Robust Multi-Modality Alignment Approach to Large Language-Vision Models')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Thanh-Dat Truong, Huu-Thien Tran, Tran Thai Son, Bhiksha Raj, Khoa Luu

**分类**: cs.CV

**发布日期**: 2025-08-19 (更新: 2025-11-25)

**备注**: Accepted to NeurIPS'25

---

## 💡 一句话要点

**提出定向标记以解决多模态对齐问题**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `多模态对齐` `视觉理解` `文本处理` `定向标记` `深度学习` `模型鲁棒性` `图像重建` `推理能力`

## 📋 核心要点

1. 现有大型多模态模型在视觉和文本特征的对齐与相关性方面存在鲁棒性和泛化能力不足的问题。
2. 本文提出了一种通过重建图像和文本顺序的新任务，来改善视觉与文本模态之间的对齐和推理能力。
3. 实验结果表明，所提出的方法在多个基准测试中均实现了最先进的性能，显著提升了模型的理解能力。

## 📝 摘要（中文）

大型多模态模型（LMMs）在各种理解任务中表现出色，但仍面临与视觉和文本特征对齐及相关性相关的鲁棒性和泛化能力的基本限制。本文提出了一种简单而高效的学习机制，通过解决打乱问题来改善视觉和文本模态之间的鲁棒对齐。具体而言，所提出的方法通过引入重建图像顺序和文本顺序的两个新任务，提升推理能力、视觉理解和跨模态对齐。此外，提出了一种新的定向标记方法，以捕捉视觉和文本知识，增强重建视觉输入正确顺序的能力。最后，引入了一种新的图像到响应引导损失，进一步提升LMM在响应中的视觉理解。该方法在学术任务导向和指令跟随的LMM基准测试中，始终实现了最先进的性能。

## 🔬 方法详解

**问题定义**：本文旨在解决大型多模态模型在视觉和文本特征对齐方面的鲁棒性和泛化能力不足的问题。现有方法在处理视觉和文本信息时，常常受到特征打乱的影响，导致模型性能下降。

**核心思路**：论文提出了一种新的学习机制，通过引入重建图像顺序和文本顺序的任务，来增强视觉和文本模态之间的对齐能力。这种设计旨在提高模型的推理能力和视觉理解。

**技术框架**：整体架构包括预训练和微调两个阶段。在预训练阶段，模型通过重建任务学习视觉和文本的正确顺序；在微调阶段，使用新的图像到响应引导损失进一步提升模型的视觉理解能力。

**关键创新**：最重要的创新点在于引入了定向标记方法，以更有效地捕捉视觉和文本知识，增强模型重建视觉输入顺序的能力。这与现有方法的主要区别在于，定向标记提供了更明确的特征对齐机制。

**关键设计**：在损失函数设计上，提出了图像到响应引导损失，旨在通过引导模型关注重要的视觉特征来提升理解能力。此外，模型架构的选择和参数设置经过精心调整，以确保在多模态对齐任务中的最佳性能。

## 📊 实验亮点

实验结果显示，所提出的方法在多个基准测试中均达到了最先进的性能，相较于以往的多模态模型，推理能力和视觉理解能力提升显著，具体性能数据未提供，但整体提升幅度显著。

## 🎯 应用场景

该研究具有广泛的应用潜力，尤其在需要视觉和文本信息紧密结合的领域，如智能助理、自动驾驶、视频理解和社交媒体分析等。通过提升多模态模型的对齐能力，能够显著改善人机交互体验和信息检索的准确性，推动相关技术的发展与应用。

## 📄 摘要（原文）

> Large multimodal models (LMMs) have gained impressive performance due to their outstanding capability in various understanding tasks. However, these models still suffer from some fundamental limitations related to robustness and generalization due to the alignment and correlation between visual and textual features. In this paper, we introduce a simple but efficient learning mechanism for improving the robust alignment between visual and textual modalities by solving shuffling problems. In particular, the proposed approach can improve reasoning capability, visual understanding, and cross-modality alignment by introducing two new tasks: reconstructing the image order and the text order into the LMM's pre-training and fine-tuning phases. In addition, we propose a new directed-token approach to capture visual and textual knowledge, enabling the capability to reconstruct the correct order of visual inputs. Then, we introduce a new Image-to-Response Guided loss to further improve the visual understanding of the LMM in its responses. The proposed approach consistently achieves state-of-the-art (SoTA) performance compared with prior LMMs on academic task-oriented and instruction-following LMM benchmarks.

