# Voince

**Локальная AI-обработка инвойсов.**  
Превращает PDF-инвойсы в структурированные и провалидированные данные с помощью локальной LLM.

```
PDF  →  AI extraction  →  Validation  →  Review  →  CSV / Excel
```

![Python](https://img.shields.io/badge/python-3.11%2B-blue)
![License](https://img.shields.io/badge/license-MIT-green)

🇷🇺 **Русский** · 🇬🇧 [English](README.md)

---

## Demo

<p align="center">
  <img src="docs/demo.gif" alt="Voince demo — загрузите инвойс и получите структурированные данные" width="720">
</p>

Регистрация → загрузите PDF-инвойс → AI извлекает поля → вы проверяете → approve → экспорт в CSV или Excel.

> **Примечание:** это ранний MVP. Не каждый формат инвойса обрабатывается идеально. См. [Ограничения](#ограничения).

---

## Зачем Voince?

Ручной ввод данных из инвойсов — это медленно, повторяюще и легко ошибиться. Большинство AI-инструментов решают это, отправляя ваши документы в облако. Voince идёт другим путём.

Voince запускает языковую модель **локально** через [Ollama](https://ollama.com). Содержимое инвойса остаётся на машине, где работает сервер — ничего не уходит в OpenAI, Anthropic, Google и другие облачные AI-сервисы.

Ключевые идеи:

- **Локальная обработка** — инференс идёт на вашем железе.
- **Структурированный вывод** — модель возвращает строгую JSON-схему, валидируемую через Pydantic.
- **Детерминированная валидация** — бизнес-правила (арифметика, обязательные поля) проверяются в Python, а не угадываются моделью.
- **Human review** — каждый инвойс можно одобрить, отредактировать или отклонить до того, как он попадёт в ваши записи.

---

## Возможности

**AI-пайплайн**

- Загрузка PDF-инвойсов через drag & drop
- Извлечение текста из текстовых PDF (`pypdf`, чистый Python)
- Локальный инференс Llama через Ollama
- Структурированное извлечение JSON по фиксированной схеме
- Валидация схемы через Pydantic
- Детерминированная валидация бизнес-правил (арифметика, обязательные поля)

**Review и редактирование**

- Human review с inline-редактированием
- Полноценное редактирование line items (добавить / изменить / удалить)
- Workflow Approve / Reject
- Автоматический перезапуск валидации после каждого изменения

**Аккаунты и лимиты**

- Регистрация и вход по email + пароль
- Вход через Google (OAuth 2.0 / OpenID Connect)
- Вход через GitHub (OAuth 2.0)
- Связка аккаунтов по verified email
- Бесплатный план: **10 инвойсов в месяц**
- Учёт использования с автоматическим сбросом в новый месяц
- Страница Settings: смена email, установка/смена пароля, удаление аккаунта

**Данные и экспорт**

- Хранение в SQLite
- Строгая изоляция данных по пользователю (пользователь A никогда не увидит инвойсы пользователя B)
- Экспорт в CSV (один инвойс или все сразу)
- Экспорт в Excel (`.xlsx`, со вторым листом line items)

**UI**

- Светлая и тёмная темы
- Адаптивная вёрстка

---

## Как это работает

```
PDF invoice
    ↓
pypdf (извлечение текста)
    ↓
Ollama + Llama 3.2 (локальный инференс)
    ↓
Structured JSON
    ↓
Pydantic (валидация схемы)
    ↓
Python validation rules
    ↓
SQLite (хранение)
    ↓
Web UI (review, edit, approve/reject)
    ↓
CSV / Excel export
```

**Архитектурный принцип:**

> LLM отвечает за **извлечение** информации. Бизнес-правила — обязательные поля, арифметическая согласованность, обработка валют — проверяются **детерминированно** в Python.

Это разделение делает систему предсказуемой. Если модель выдумает total, валидатор это поймает. Если обязательное поле отсутствует, UI это покажет. AI никогда не решает, что «правильно» — она только предлагает значения, которые Python потом проверяет.

---

## Стек

| Слой | Технология |
|---|---|
| Backend | Python, FastAPI, Uvicorn |
| Шаблоны | Jinja2, Bootstrap 5 |
| Валидация | Pydantic 2 |
| ORM | SQLModel (SQLAlchemy) |
| База | SQLite |
| PDF текст | pypdf (чистый Python) |
| AI | Ollama + Llama 3.2 (локально) |
| HTTP клиент | httpx |
| Пароли | bcrypt |
| Сессии | Starlette SessionMiddleware |
| OAuth | Authlib |
| Excel | openpyxl |
| Тесты | pytest |

---

## Требования

- **ОС:** Windows, macOS или Linux
- **Python:** 3.11 или новее (проверено на 3.11, 3.12 и 3.14)
- **Ollama:** установлена локально — [скачать здесь](https://ollama.com/download)
- **Модель:** `llama3.2` (~2 ГБ) через Ollama

Ключи облачных AI API не нужны. Платные сервисы не используются.

---

## Установка

### 1. Установите Ollama

Скачайте с <https://ollama.com/download> и следуйте установщику для вашей ОС.

Проверьте:

```bash
ollama --version
```

### 2. Скачайте модель

```bash
ollama pull llama3.2
```

Проверьте:

```bash
ollama list
```

В списке должна появиться `llama3.2`.

### 3. Клонируйте репозиторий

```bash
git clone https://github.com/Belannandere/Voince.git
cd Voince
```

### 4. Создайте виртуальное окружение

**Windows (PowerShell):**

```powershell
python -m venv .venv
.venv\Scripts\Activate.ps1
```

**macOS / Linux:**

```bash
python3 -m venv .venv
source .venv/bin/activate
```

### 5. Установите зависимости

```bash
python -m pip install --upgrade pip
python -m pip install -r requirements.txt
```

### 6. Настройте переменные окружения

```bash
copy .env.example .env       # Windows
cp .env.example .env         # macOS / Linux
```

Сгенерируйте `SECRET_KEY`:

```bash
python -c "import secrets; print(secrets.token_urlsafe(48))"
```

Вставьте результат в `SECRET_KEY=` в `.env`. Остальные значения по умолчанию работают из коробки.

### 7. (Опционально) Настройте OAuth

Если хотите «Sign in with Google» / «Sign in with GitHub» — следуйте инструкциям в конце README. Без этой настройки OAuth-кнопки будут просто перенаправлять на `?error=oauth_unavailable`, но вход по email и паролю работает.

---

## Запуск

Нужно **два терминала** — один для Ollama, второй для приложения.

### Терминал 1 — Ollama

```bash
ollama serve
```

> **Если Ollama падает с CUDA-ошибкой** на Windows с видеокартой NVIDIA, принудительно запустите в CPU-режиме:
>
> ```powershell
> $env:OLLAMA_LLM_LIBRARY="cpu_avx2"
> ollama serve
> ```
>
> Чтобы сделать это постоянным, добавьте `OLLAMA_LLM_LIBRARY=cpu_avx2` в переменные среды пользователя.

### Терминал 2 — Voince

```bash
python -m uvicorn app.main:app --reload
```

Откройте <http://localhost:8000> в браузере.

---

## Использование

1. Зарегистрируйтесь на `/register` — либо войдите через Google / GitHub.
2. Откройте **Upload**.
3. Перетащите PDF-инвойс с текстовым слоем (текст должен выделяться мышкой в любой PDF-программе).
4. Дождитесь извлечения. На CPU-инференсе это может занять 30–90 секунд на одну страницу.
5. Проверьте извлечённые поля, строки и сообщения валидации.
6. Выберите одно из действий:
   - **Approve** — принять данные как есть.
   - **Edit** — исправить любое поле или строку и сохранить. Валидация запустится заново.
   - **Reject** — пометить документ как необработанный.
7. Скачайте результат как **CSV** или **Excel** — для одного инвойса или для всех сразу со страницы **Invoices**.

Бесплатный план: **10 инвойсов в месяц**.

---

## Запуск тестов

```bash
pytest -v
```

Тесты покрывают аутентификацию, изоляцию данных пользователей (пользователь A не может получить доступ к документам пользователя B ни через какой URL или метод), месячные лимиты, редактирование строк и операции в Settings.

---

## Ограничения

Voince — это ранний MVP. Он честен относительно того, что умеет и чего не умеет.

**Чего НЕ умеет:**

- **OCR сканированных PDF.** Если в PDF нет текстового слоя, Voince откажется его обрабатывать и честно об этом скажет. OCR (Tesseract, EasyOCR) в roadmap.
- **Импорт из email.** Инвойсы загружаются вручную. IMAP не реализован.
- **Интеграции с бухгалтерией.** QuickBooks, Xero и аналоги пока не подключены.
- **Платные тарифы / биллинг.** Реально работает только бесплатный план. Тариф Pro на странице Pricing — заглушка.

**О качестве:**

- Llama 3.2 (3B) — небольшая модель. Хорошо справляется с чистыми текстовыми инвойсами, но иногда может пропустить строку или ошибиться в total на плотных или нестандартных макетах. Именно поэтому существуют детерминированная валидация и human review.
- На CPU-инференсе обработка медленная. `llama3.2:1b` быстрее, но менее точна на таблицах. GPU резко ускоряет процесс.

---

## Roadmap

Идеи, которые рассматриваются:

- OCR для сканов
- IMAP / импорт из email
- Платные тарифы через Stripe
- Интеграции QuickBooks / Xero
- Мультивалютные правила валидации
- Экспорт в форматы для бухгалтерии (SAF-T, UBL)
- Скрипт установки «в одну команду» для self-hosted

Ничего из этого не обещано. Это список желаний, не контракт.

---

## Структура проекта

```
Voince/
├── app/
│   ├── main.py             # FastAPI-приложение, маршруты
│   ├── config.py           # Настройки из .env
│   ├── database.py         # SQLite engine, миграции, session
│   ├── models.py           # Таблицы SQLModel (User, Document, ...)
│   ├── schemas.py          # Pydantic-схема Invoice
│   ├── repository.py       # CRUD-операции с БД
│   ├── auth.py             # Хеширование пароля, сессии, current user
│   ├── limiter.py          # Месячный лимит инвойсов
│   ├── oauth.py            # OAuth-провайдеры через Authlib
│   ├── pdf.py              # PDFExtractor + PypdfExtractor
│   ├── ai.py               # AIExtractor + OllamaInvoiceExtractor
│   ├── validation.py       # Детерминированные бизнес-правила
│   ├── export.py           # Генерация CSV
│   ├── export_excel.py     # Генерация XLSX
│   ├── timing.py           # Замер времени этапов
│   ├── templates/          # Jinja2-шаблоны
│   └── static/             # CSS, favicon
├── tests/                  # pytest-набор
├── pytest.ini
├── requirements.txt
└── README.md
```

---

## Конфигурация

Voince читает настройки из `.env`:

| Переменная | По умолчанию | Назначение |
|---|---|---|
| `SECRET_KEY` | — | Подпись session-cookie. **Смените в продакшене.** |
| `SESSION_MAX_AGE` | `1209600` | Время жизни сессии в секундах (14 дней) |
| `OLLAMA_URL` | `http://localhost:11434` | Адрес Ollama API |
| `OLLAMA_MODEL` | `llama3.2` | Имя модели (например `llama3.2:1b`) |
| `UPLOAD_DIR` | `uploads` | Папка для PDF |
| `MAX_UPLOAD_MB` | `10` | Максимальный размер загрузки |
| `DATABASE_URL` | SQLite-файл в корне проекта | Строка подключения к БД |
| `GOOGLE_CLIENT_ID` | — | Google OAuth client ID |
| `GOOGLE_CLIENT_SECRET` | — | Google OAuth client secret |
| `GITHUB_CLIENT_ID` | — | GitHub OAuth client ID |
| `GITHUB_CLIENT_SECRET` | — | GitHub OAuth client secret |

---

## Расширение Voince

### Другая LLM

`app/ai.py` определяет абстрактный `AIExtractor`. Чтобы подключить другого провайдера (Mistral, Qwen или даже облачный API), унаследуйтесь от него и поменяйте singleton внизу файла:

```python
ai_extractor: AIExtractor = YourNewExtractor(...)
```

### OCR для сканов

`app/pdf.py` определяет абстрактный `PDFExtractor`. Добавьте `OCRPdfExtractor(PDFExtractor)` и замените singleton:

```python
pdf_extractor: PDFExtractor = OCRPdfExtractor()
```

### Более быстрый парсер (PyMuPDF)

`pypdf` — чистый Python и работает на любой версии. Если нужна скорость или лучшее качество на сложной вёрстке, можно переключиться на **PyMuPDF** — но он поставляется как скомпилированные wheels, которые могут отсутствовать для новых версий Python на Windows.

1. `python -m pip install pymupdf`
2. Добавьте класс `PyMuPDFExtractor(PDFExtractor)` рядом с `PypdfExtractor` в `app/pdf.py`.
3. Поменяйте singleton внизу файла.

---

## Настройка Google OAuth

1. Откройте [Google Cloud Console](https://console.cloud.google.com/) → создайте проект (например, `Voince`).
2. **APIs & Services** → **OAuth consent screen** (сейчас называется *Google Auth Platform*):
   - User Type: **External**.
   - Впишите название приложения и support email.
   - Добавьте свой Google-аккаунт в **Test users**, пока приложение не опубликовано.
3. **APIs & Services → Credentials → Create OAuth client ID**:
   - Application type: **Web application**.
   - Name: `Voince Local`.
   - Authorized JavaScript origins: `http://localhost:8000`
   - Authorized redirect URIs: `http://localhost:8000/auth/google/callback`
4. Скопируйте **Client ID** и **Client secret** в `.env`:
   ```
   GOOGLE_CLIENT_ID=...
   GOOGLE_CLIENT_SECRET=...
   ```

Для продакшена добавьте продовый домен в оба списка.

## Настройка GitHub OAuth

1. Откройте [GitHub Developer Settings](https://github.com/settings/developers) → **OAuth Apps** → **New OAuth App**.
2. Заполните:
   - Application name: `Voince`
   - Homepage URL: `http://localhost:8000`
   - Authorization callback URL: `http://localhost:8000/auth/github/callback`
3. Скопируйте **Client ID** и сгенерируйте **Client secret**.
4. Добавьте в `.env`:
   ```
   GITHUB_CLIENT_ID=...
   GITHUB_CLIENT_SECRET=...
   ```

GitHub разрешает только один callback URL на приложение. Для продакшена создайте **второе** OAuth App, нацеленное на продовый домен.

---

## Диагностика

| Проблема | Решение |
|---|---|
| `pip: command not found` | Используйте `python -m pip` |
| `uvicorn: command not found` | Используйте `python -m uvicorn` |
| Ollama падает с CUDA error | Запустите с `OLLAMA_LLM_LIBRARY=cpu_avx2` |
| `AI extraction failed` / HTTP 500 от Ollama | Ollama не запущена или упала. Проверьте `curl http://localhost:11434/api/tags` |
| «This PDF appears to be a scanned document» | В PDF нет текстового слоя. OCR пока не поддерживается. |
| Обработка занимает 2+ минуты | Вы работаете на CPU. Попробуйте `llama3.2:1b` через `OLLAMA_MODEL=llama3.2:1b` в `.env`. |
| `redirect_uri_mismatch` от Google / GitHub | Callback URL в настройках OAuth-приложения не совпадает с тем, что отправляет приложение. Проверьте схему, хост, порт и путь. |
| `Access blocked: Voince has not completed verification` | Ваш Google-аккаунт не добавлен в **Test users** на экране OAuth consent. |
| База забита старыми данными | Удалите `invoices.db` и перезапустите приложение. |
| Сессии пропадают после перезапуска сервера | Изменился `SECRET_KEY`. Установите его один раз в `.env` и не крутите в разработке. |

---

## Лицензия

MIT